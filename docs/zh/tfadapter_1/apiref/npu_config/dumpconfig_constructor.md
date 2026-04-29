# DumpConfig构造函数

## 功能说明

DumpConfig类的构造函数，用于配置dump功能。

## 函数原型

```python
class DumpConfig():
    def __init__(self,
                 enable_dump=False,
                 dump_path=None,
                 dump_step=None,
                 dump_mode="output",
                 enable_dump_debug=False,
                 dump_debug_mode="all",
                 dump_data="tensor",
                 dump_layer=None)
```

## 参数说明

- **enable_dump**：输入，是否开启Data Dump功能。

  - True：开启Data Dump功能，从dump_path读取Dump文件保存路径。
  - False（默认值）：关闭Data Dump功能。

  > [!NOTE]说明
  > - 不能同时开启Data Dump与溢出数据采集功能，即不同时将enable_dump和enable_dump_debug参数配置为“True”。
  > - 若“enable_dump/enable_dump_debug（二选一）”参数配置为“True”，同时“enable_exception_dump”配置为了“1”（即开启普通ExceptionDump）。此时，针对动态shape网络，仅“enable_exception_dump”生效；针对静态shape网络，“enable_exception_dump”与“enable_dump/enable_dump_debug（二选一）”都生效。

- **dump_path**：输入，Dump文件保存路径。enable_dump或enable_dump_debug为True时，该参数必须配置。

    该参数指定的目录需要在启动训练的环境上（容器或Host侧）提前创建且确保安装时配置的运行用户具有读写权限，支持配置绝对路径或相对路径（相对执行命令行时的当前路径）。

  - 绝对路径配置以“/”开头，例如：/home/test/output。
  - 相对路径配置直接以目录名开始，例如：output。

- **dump_step**：输入，指定采集哪些迭代的Data Dump数据。

    多个迭代用“|”分割，例如：0|5|10；也可以用"-"指定迭代范围，例如：0|3-5|10。

    若不配置该参数，表示采集所有迭代的dump数据。

- **dump_mode**：输入，Data Dump模式，用于指定dump算子输入还是输出数据。取值如下：

  - input：仅dump算子输入数据。
  - output：仅dump算子输出数据，默认为output。
  - all：dump算子输入和输出数据。

    > [!NOTE]说明
    > 配置为all时，由于部分算子在执行过程中会修改输入数据，例如集合通信类算子HcomAllGather、HcomAllReduce等，因此系统在进行dump时，会在算子执行前dump算子输入，在算子执行后dump算子输出，这样，针对同一个算子，算子输入、输出的dump数据是分开落盘，会出现多个dump文件，在解析dump文件后，用户可通过文件内容判断是输入还是输出。

- **enable_dump_debug**：输入，溢出检测模式，取值如下：
  - aicore_overflow：AI Core算子溢出检测，检测在算子输入数据正常的情况下，输出是否不正常的极大值（如float16下65500,38400,51200这些值）。一旦检测出这类问题，需要根据网络实际需求和算子逻辑来分析溢出原因并修改算子实现。
  - atomic_overflow：Atomic Add溢出检测模式，在AI Core计算完，由UB搬运到OUT时，产生的Atomic Add溢出问题。
  - all：同时进行AI Core算子溢出检测和Atomic Add溢出检测。默认值为“all”。

    > [!NOTE]说明
    > 针对Ascend 950PR/Ascend 950DT，Atlas A3 训练系列产品/Atlas A3 推理系列产品，Atlas A2 训练系列产品/Atlas A2 推理系列产品，仅支持配置为默认值“all”。

- **dump_debug_mode**：输入，溢出检测模式，取值如下：
  - aicore_overflow：AI Core算子溢出检测，检测在算子输入数据正常的情况下，输出是否不正常的极大值（如float16下65500,38400,51200这些值）。一旦检测出这类问题，需要根据网络实际需求和算子逻辑来分析溢出原因并修改算子实现。
  - atomic_overflow：Atomic Add溢出检测模式，在AI Core计算完，由UB搬运到OUT时，产生的Atomic Add溢出问题。
  - all：同时进行AI Core算子溢出检测和Atomic Add溢出检测。默认值为“all”。

    > [!NOTE]说明
    > 针对Ascend 950PR/Ascend 950DT，Atlas A3 训练系列产品/Atlas A3 推理系列产品，Atlas A2 训练系列产品/Atlas A2 推理系列产品，仅支持配置为默认值“all”。

- **dump_data**：输入，指定算子dump内容类型，取值：

  - tensor: dump算子数据，默认为tensor。
  - stats: dump算子统计数据，结果文件为csv格式。

    大规模训练场景下，通常dump数据量太大并且耗时长，可以先dump所有算子的统计数据，根据统计数据识别可能异常的算子，然后再指定dump异常算子的input或output数据。

- **dump_layer**：输入，指定需要dump的算子。取值为算子名，多个算子名之间使用空格分隔。若不配置此字段，默认dump全部算子。

    若指定的算子其输入涉及data算子，会同时将data算子信息dump出来。

## 返回值

返回DumpConfig类对象，作为NPURunConfig的参数传入。

## 约束说明

enable_dump和enable_dump_debug不能同时开启。

## 调用示例

```python
from npu_bridge.npu_init import *
...
dump_config = DumpConfig(enable_dump=True, dump_path="/home/test/output", dump_step="0|5|10", dump_mode="all")
session_config=tf.ConfigProto(allow_soft_placement=True)
config = NPURunConfig(dump_config=dump_config, session_config=session_config)
```
