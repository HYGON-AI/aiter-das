<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# CustomAllreduce 实现与安全边界

[返回最新用法与性能](../custom_allreduce.md)。本页说明输入生命周期、LL协议和共享实现约束。


gfx936/gfx938 的传统 Graph 输入路径继续使用预注册 staging buffer 的 copy-in。请求
`enable_register_for_capturing=True` 不代表直接注册已生效；应记录 communicator
的 `enable_register_for_capturing` 实际值及加载的 Python/native 路径。固定输入的
直接注册微基准只能作为 kernel 控制组，不能证明变化输入、连续复用或多 Graph 安全。

已准入的 LL/LL128 可直接读取本卡原输入，再向既有通信 scratch 发布数据，省去
前置 D2D；peer 不读取原输入分配。输入和输出须均16B对齐且不重叠，否则保留
copy-in。容量、量化路径、epoch、release/acquire及消费完成确认保持有效。
参见[本卡输入优化结果](custom_allreduce_local_input_20261011.md)。

当前上游 one-stage 同样包含尾部 `end_sync`。Hygon 保留该同步以及 BF16 每个存储
边界的 RNE；性能对照必须使用相同精度与输入生命周期契约。TP2 大载荷仍走传统
one-stage，LL/LL128 小载荷算法的缺口不能直接解释 8/32 MiB 的性能差距。

gfx936/gfx938 的普通 IPC TP2 路径使用已有的256线程寄存器 one-stage，保留原grid、
copy-in和同步；默认off也适用。见[TP2寄存器规约对照](custom_allreduce_tp2_register_20261011.md)。

普通 CAR 保留 rank 2/4/6/8/16/32/40 和 IPC/Fabric 分派。共享 `Signal`、
`RankData`、`RankSignals` 布局由 CAR、融合 MHC 与 asm communication 共同使用；
修改公共头后应重编相应模块，不能混用未经核验的旧 native 文件。

BF16 转换检查（2026-10-10）：gfx936/gfx938 上分别枚举全部 BF16 高16位与
FP32 低16位 `0/0x7fff/0x8000/0x8001/0xffff`，直接调用公共头的 scalar/vector
转换 helper。每架构 327,680 个输入、655,360 次检查通过，包含半ULP边界、
正负零、subnormal、Inf/NaN（NaN检查类别，非payload逐位相同）。实际 ISA
采用整数位提取、`v_add3_u32` 舍入偏置及特殊值分支；vector 有有限值快速路径。
这证明当前转换的数值行为，不证明转换是端到端性能瓶颈。

## 可选 HCU LL / LL128

`AITER_AR_SMALL_MESSAGE=off`（默认）保留传统路径。`ll`、`ll128` 和 `auto`
可用于 gfx936/gfx938 的单机 IPC、TP2/4/8、FP16/BF16 验证；FP32、旧算法、
注册输出路径及其他 rank/transport/架构继续使用原分派。各 rank 必须使用相同
设置和 `max_size`，并按相同顺序提交 collective。一个 communicator 的多个
Graph 应顺序执行，不支持并发复用其 staging/scratch。

LL 采用8B payload/16B line；LL128 每8lane group携带240B payload。
HCU 适配使用显式64-bit flag release/acquire及消费完成确认，LL128先保证各lane
数据系统可见，再发布flag；不依赖16B或跨lane128B事务原子性。独立scratch位于
传统临时区之后，共享 `Signal/RankData/RankSignals` 布局不变。TP2初始化另需
4,439,552字节scratch；`max_size`小于所需scratch时自动回退，可检查
`communicator.small_ar_mode` 的有效值。

`auto` 在gfx936/gfx938单机IPC的TP2/4、FP16/BF16、每rank输入≤32KiB时选择LL，
其余使用传统路径；TP8不自动启用LL，auto不选择LL128。两架构分别标定后使用
相同的保守策略。显式`ll`仍支持≤64KiB；显式`ll128`仍支持TP2≤896KiB、TP4≤64KiB。
默认仍为off。不要用固定输入控制组或单一尺寸代替变化输入、混合尺寸及多rank验证。

TP8不准入LL128 kernel，显式设置`ll128`也会使用传统回退；该请求模式的计时
差异不能归因于LL128算法。

普通 two-stage 将完整 tile 与 partial tile 分开：完整 tile 使用原 LDS 归约，
尾部 pack 由原 owner thread 直接归约，避免线程相关边界下发散执行 block barrier。
原 gfx92a gather、DTK launch 分支和 6/16/32/40 rank 分派保持不变。空输入和
非16B整数倍输入不进入 native kernel；显式 `all_reduce` 对这些输入抛出异常，
`custom_all_reduce` 的准入判断拒绝空输入。输出的元素数、dtype/device必须匹配。

所有rank使用相同模式与容量；若任一rank不具备小载荷能力，全组回退传统路径。
配置不一致会在分配scratch之前拒绝。使用新公共头构建CAR与共享融合模块时，
应保持编译开关一致，并核验实际加载的Python/native文件。

LL/LL128 的FP32累加固定为rank 0到N-1，以保持各rank在强抵消和舍入边界下的
输出一致；每次写回仍使用原RNE转换。BF16的历史输出注册形式保持不变，
direct-registered输入的LL准入由独立标志控制，不因该历史形式而绕过安全回退。

此前的[算法对照结果](custom_allreduce_hcu_algorithms_20261010.md)覆盖双架构TP2/TP4、
阈值两侧与32MiB输入。该报告使用此前的auto范围；当前auto范围见上文及组合优化报告。
显式LL/LL128仍用于指定算法验证，不保证所有支持尺寸提速；TP2较大LL128载荷和TP4部分小载荷存在退化。

[gfx938 TP8补测结果](custom_allreduce_tp8_gfx938_20261011.md)包含八卡精度回归、
partial-tile分派和760组完整性能样本。本轮保留其他任务运行，存在明显时段波动；
未证明TP8 LL稳定提速，默认仍为off。该TP8表不能直接与[历史TP2基线](custom_allreduce_baseline_20261010.md)比较。
