<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# AllGatherv / ReduceScatterv：MoE 用法与性能

`all_gatherv` 允许各 rank 的输入 token 数不同；`reduce_scatterv` 允许各 rank 的**输出分片长度**不同。后者各 rank 的输入仍须具有相同的完整形状 `[sum(sizes), H]`，按对应位置做 SUM 后分发，不能把各 rank 任意不同长度的输入直接相加。

这两个接口通过 PyNccl 调用 RCCL，不使用 `CustomAllreduce.custom_all_gather/custom_reduce_scatter`。因此不能直接套用 [Custom AllGather](custom_all_gather.md) 或 [Custom ReduceScatter](custom_reduce_scatter.md) 的性能、容量上限和 FP8 数值合同。

## 接口合同

以下方法位于 `aiter.dist.device_communicators.communicator_cuda.CudaCommunicator`。本页参考的 vLLM 有自己的 `GroupCoordinator` 同名封装；当前 AITER `GroupCoordinator` 没有这两个同名入口，不能直接把 vLLM 组级示例套到 AITER 的 `get_dp_group()` 上。

| 接口 | 输入与输出 | 执行方式 |
|---|---|---|
| `all_gatherv(input_, dim=0, sizes=None)` | Tensor 或 Tensor 列表；每个输入为 `[sizes[rank], ...]`，输出为 `[sum(sizes), ...]` | 不等长时每个 Tensor 发起一组逐 root Broadcast；等长或 sizes=None 时自动走原生 AllGather |
| `reduce_scatterv(input_, dim=-1, sizes=None)` | 所有 rank 输入均为完整张量；沿 dim 规约、分片，输出该维长度为 sizes[rank] | 显式 sizes 走逐 root Reduce；sizes=None 走原生 ReduceScatter |

- `all_gatherv` 只支持 `dim=0`。列表内各 Tensor 的 token 数和 sizes 相同，后续维度和 dtype 可以不同；不同 rank 的对应 Tensor 必须保持 dtype、后续维度及列表顺序一致。
- `reduce_scatterv` 可移动指定维到首维并构造连续输入/输出；MoE 调用应显式使用 `dim=0`，避免默认末维语义。
- sizes 的长度等于组大小，元素为非负整数，所有 rank 提供相同列表和调用顺序。0 长度 rank 仍须参与 collective。
- 传入连续、位于通信器绑定设备上的输入。PyNccl 通信器必须可用；`reduce_scatterv` 的低层 disabled 分支不执行通信，调用方不能忽略后端状态。
- 当前共同 PyNccl dtype 映射包含 INT8，不包含 FP8。**这两个 v 接口当前不支持 E4M3FN/E5M2/FNUZ；custom AG/RS 的 FP8 扩展不自动覆盖它们。**本页性能测试使用 BF16 主数据、BF16/FP32 router 和 FP32/INT32 top-k 元数据，没有测试 INT8 通信性能。
- Graph 的 sizes、形状、地址和调用顺序在捕获时固定；通过原地址 `copy_` 更新输入内容。测试的变化输入 replay 不代表同一个 Graph 支持动态 sizes。

示意调用（`comm` 是绑定到相应 DP 组、已初始化且 PyNccl 可用的 AITER `CudaCommunicator`，示例为 4 rank）：

```python
sizes = [129, 64, 200, 0]
# hidden: [sizes[rank], 2560] BF16
# router_logits: [sizes[rank], 512]，dtype 由框架路由实现决定
all_hidden, all_logits = comm.all_gatherv(
    [hidden, router_logits], dim=0, sizes=sizes
)
# 每个 rank 的本地专家贡献均覆盖完整 token 顺序：[sum(sizes), 2560]
local_output = comm.reduce_scatterv(
    expert_contributions, dim=0, sizes=sizes
)
# local_output: [sizes[rank], 2560]
```

## PCG 模型形状与通信组

源码参照本地 vLLM `origin/amd_dev`，commit `dbab37f36b5bc304d628ab4ab9c07bd5e089724e`；AITER 测试 commit 为 `a400373fa36b721a5f5a1815ac8d093ee71c9481`。本地没有字面名称 `amd` 的分支。本节分析该 AMD 引用的通用 MoE 调用方式，未执行 PCG 专用模型实现。

用户提供的启动配置为 **TP=1、DP=4、启用 EP**。该 AMD 引用默认 `all2all_backend=allgather_reducescatter`。`AgRsAll2AllManager` 在非 sequence-parallel MoE 模式下实际调用 DP 组；SP 模式使用 EP 组，但 SP 条件包含 TP>1，当前 TP1 不满足。

在 PCP=1 时 EP 规模为 DP×TP；这里 DP4 和 EP4 的 rank 成员相同，TP 组只有一个 rank。流程为 **DP AllGatherv 分发 → 本地专家计算 → DP ReduceScatterv 合并**，没有后续跨卡 TP 通信。将本页称为 TP4 性能会误解实际调用。DP2/EP2 是两卡缩放对照，DP4/EP4 对应用户启动规模。

**框架与 AITER 的等长 RS 分派不同。**该 vLLM AMD 引用的 `CudaCommunicator.reduce_scatterv` 在 sizes 全相等时直接调用 PyNccl 原生 ReduceScatter；本地 vLLM main `dd9e07a25febb05f1a44f2ef9e6c56803ee1a9b6` 的普通分派也如此。当前 AITER 同名方法显式传 sizes 时仍使用 grouped Reduce。因此下表同时给出 AITER 显式 sizes 与原生路径；**原生路径列才对应 vLLM 普通等长 RS 的底层通信选择**，不等长仍对应 grouped Reduce。这里是底层路由对齐，未测量 vLLM 完整封装、对称内存或确定性特殊路径。

源码定位：

- `vllm/config/parallel.py`：默认 all2all backend 与 `use_sequence_parallel_moe` 条件。
- `vllm/distributed/device_communicators/all2all.py`：`AgRsAll2AllManager.dispatch_router_logits`、`dispatch`、`combine` 的实际组、Tensor 列表与 sizes。
- `vllm/model_executor/layers/fused_moe/layer.py`：通用 dispatch → experts → combine；具体量化方法也可能选用内部通信路径。
- `vllm/model_executor/models/qwen3_next.py`：SP token 切分及专家输出后的 TP 通信条件。
- `vllm/distributed/parallel_state.py`：DP/EP 的 rank 组建。

模型目录 `Qwen3.8-Flash-Next-w4a8-slimquant-ngram-int8` 的实际配置为 `Qwen4ExpForConditionalGeneration`：hidden_size=2560、专家数=512、top-k=10、基础 dtype=BF16。AMD 引用尚无对应模型与 slimquant 实现，因此以下数据是**按模型尺寸重放真实 AITER 通信 API**，不是整模运行或实际 PCG trace。

| 测试调用 | 每 rank 输入 |
|---|---|
| AG hidden only | `[T_r,2560]` BF16 |
| AG hidden + router BF16 | `[T_r,2560]` BF16 + `[T_r,512]` BF16；默认模型 dtype 参考负载 |
| AG hidden + router FP32 | 同 hidden + `[T_r,512]` FP32；路由 dtype 对照 |
| AG hidden + top-k | 同 hidden + `[T_r,10]` FP32 weights + `[T_r,10]` INT32 ids；另一 dispatch 入口 |
| RS combine | 每 rank `[sum(T_r),2560]` BF16 → `[T_r,2560]` BF16 |

W4A8 权重量化和 `--kv-cache-dtype fp8_e5m2` 不确定通信 Tensor 的 dtype。`hc_count=4` 也不能据此将 MoE hidden 宽度直接乘 4。BF16 router 与替代 metadata 分支是构造对照，实际模型适配完成后应再核对其入口和 dtype。

token 点为 1/8/32/129/516/2048/8192。129 对应 `max-num-seqs`；516=129×(3+1)，是 MTP 三个推测 token 加一个目标 token 的代表构造点；8192 对应每 DP rank 的 `max-num-batched-tokens`。它们不是线上采样分布，实际调度和 Graph padding 会改变 token 数。RS 的完整输入可能含 G×8192 个 token，这不等于单 rank 调度上限被调高。

## 测量条件

测试日期：2026-10-16。测试使用 gfx936、gfx938 两种架构的单机多卡配置，分别运行 2 rank 和 4 rank 通信组；2 rank 使用设备 0/1，4 rank 使用设备 0/1/2/3。硬件与软件配置如下。

| 架构 | 设备 | PyTorch | HIP | RCCL raw version |
|---|---|---|---|---:|
| gfx936 | BW1000 64G | 2.11.0 | 6.3.26113 | 22203 |
| gfx938 | BW1101 | 2.10.0 | 6.3.26113 | 22203 |

两端实际加载 RCCL ELF 的 SHA256 相同：`32aa13da8bbd4d9a4ec37be08014f0783f5f576c7439dc10a3e1c661aa35427a`。跨架构数字包含两台服务器、拓扑与 PyTorch 版本差异，不能归因成纯架构差异。

调用真实 `CudaCommunicator` 和 PyNccl/RCCL；基准只跳过无关的 custom communicator 初始化。计时包含公开 API 的输出分配。每点先预热，9 轮×20 次调用，每轮取各 rank 的最大值，再统计中位数、P95/max 和 CV。Graph 捕获 20 个连续调用，replay 耗时除以 20；它是固定形状的均摊通信耗时，不是单次 Graph 的端到端服务耗时。

GPU Event 覆盖完整设备时间区间，Eager 中也包含 CPU 提交造成的 GPU 空隙；另保存同步墙钟。测试为重复使用输入的暖态通信，不含路由/专家计算、MTP 模型、KV cache、CPU offload 或多通信组并发，不能直接换算请求延迟或模型吞吐。正确性参考使用 BF16 可精确表示的小整数 SUM，验证分发/规约、rank 顺序及变化输入，不代表完整模型浮点误差评估。

## 结果解读

1. 对应用户 DP4 配置，均衡 129 token/rank 的 Graph AG/RS 底层普通路由参考为 gfx936 **73.69/73.20 µs**、gfx938 **80.78/54.66 µs**，其中 RS 取原生路径列；直接调用 AITER 显式 sizes 的 RS 则为79.01/52.36 µs。这是分别测量的两次通信，不含 vLLM 完整封装、中间专家计算和整层调度。
2. 小 token 时 Eager 的额外提交开销明显。例如 gfx938 DP4、129 token 的 RS 从 Eager 123.98 µs 到 Graph 52.36 µs；8192 token 则为 1038.36/1029.90 µs，二者接近。该测量支持优先保持可捕获路径；没有 profiler 数据，不能进一步将差值精确归因到某个 Python 函数或 RCCL 内部阶段。
3. 不等长 AG 使用逐 root Broadcast，等长 AG 自动走 AllGather；即使总 token 一样，通信组合及负载分布也不同。零长度 rank 减少实际有效数据来源，不意味着最坏不均衡一定更慢。DP4 的均衡 T=8192 有 32768 个总 token，而 `[8192,129,129,129]` 仅有 8579 个，不能把二者直接当作相同负载的优化对照。
4. AITER 等长 RS 可评估 `sizes=None` 的原生路径：gfx936 DP4、T=516 的 Graph 从 204.12 降至 150.57 µs，但 gfx938 DP4、T=8192 的原生路径为 1076.08 µs，慢于显式 sizes 的 1029.90 µs。当前结果不支持以性能为由在 AITER 中全形状无条件替换；vLLM 普通等长路径已经选择原生 RS。两条路径浮点规约次序可能不同，修改分派还需检查数值容差。
5. AG 的 metadata 成本不可忽略。BF16 hidden 每 token 为 5120 B，BF16 router 为 1024 B；top-k weights/ids 合计仅 80 B，但这对应不同路由计算位置/入口，不能仅为省通信量就替换框架合同。表中 metadata 对照可用于适配完成后的选路评估。

## 最终性能：均衡负载

单位 µs/调用，单元格为 **Eager / Graph** 的 GPU Event 中位数。T 为每个 DP rank 的 token 数，组内总 token 数为 G×T。AG 为一次列表调用 `[hidden BF16, router BF16]`；两列 RS 分别为 AITER 显式 sizes 的 grouped Reduce，以及与 vLLM 普通等长分派对应的原生 ReduceScatter。

| 架构 | DP/EP 组大小 | 每 rank T | AGv（Eager / Graph） | AITER 显式 sizes RSv（Eager / Graph） | 原生 RS 路径（Eager / Graph） |
|---|---:|---:|---:|---:|---:|
| gfx936 | 2 | 1 | 66.70 / 20.68 | 39.37 / 12.14 | 29.02 / 13.09 |
| gfx936 | 2 | 8 | 36.78 / 13.14 | 39.01 / 18.98 | 27.55 / 12.11 |
| gfx936 | 2 | 32 | 37.72 / 23.83 | 35.16 / 23.29 | 24.62 / 16.22 |
| gfx936 | 2 | 129 | 48.31 / 43.14 | 43.16 / 40.14 | 44.79 / 41.23 |
| gfx936 | 2 | 516 | 73.26 / 68.98 | 105.74 / 95.43 | 77.59 / 71.51 |
| gfx936 | 2 | 2048 | 165.98 / 158.50 | 286.36 / 277.46 | 215.45 / 211.86 |
| gfx936 | 2 | 8192 | 555.61 / 550.74 | 978.97 / 977.33 | 770.11 / 767.79 |
| gfx936 | 4 | 1 | 37.80 / 30.64 | 52.42 / 29.26 | 29.82 / 21.09 |
| gfx936 | 4 | 8 | 38.34 / 18.09 | 51.96 / 29.62 | 28.35 / 17.64 |
| gfx936 | 4 | 32 | 40.95 / 37.62 | 52.73 / 44.65 | 30.86 / 27.80 |
| gfx936 | 4 | 129 | 78.82 / 73.69 | 84.53 / 79.01 | 76.59 / 73.20 |
| gfx936 | 4 | 516 | 141.75 / 138.76 | 209.75 / 204.12 | 153.90 / 150.57 |
| gfx936 | 4 | 2048 | 362.93 / 358.81 | 631.46 / 625.74 | 477.53 / 473.78 |
| gfx936 | 4 | 8192 | 1371.13 / 1370.39 | 2219.66 / 2213.83 | 1813.93 / 1809.95 |
| gfx938 | 2 | 1 | 81.25 / 24.02 | 95.29 / 13.50 | 64.26 / 14.85 |
| gfx938 | 2 | 8 | 81.07 / 14.63 | 95.02 / 19.58 | 64.45 / 13.62 |
| gfx938 | 2 | 32 | 82.04 / 28.18 | 94.80 / 20.42 | 65.03 / 18.46 |
| gfx938 | 2 | 129 | 94.46 / 47.24 | 95.95 / 28.46 | 65.35 / 32.36 |
| gfx938 | 2 | 516 | 84.62 / 67.71 | 96.55 / 52.67 | 66.64 / 52.12 |
| gfx938 | 2 | 2048 | 141.62 / 136.78 | 131.78 / 124.88 | 133.43 / 128.01 |
| gfx938 | 2 | 8192 | 475.65 / 468.89 | 378.48 / 371.95 | 441.54 / 435.82 |
| gfx938 | 4 | 1 | 83.75 / 37.82 | 122.39 / 30.04 | 66.21 / 25.38 |
| gfx938 | 4 | 8 | 83.22 / 22.83 | 123.95 / 30.81 | 65.94 / 21.62 |
| gfx938 | 4 | 32 | 85.35 / 44.45 | 123.70 / 37.18 | 68.48 / 31.47 |
| gfx938 | 4 | 129 | 96.98 / 80.78 | 123.98 / 52.36 | 69.26 / 54.66 |
| gfx938 | 4 | 516 | 136.90 / 131.46 | 128.02 / 114.46 | 108.27 / 101.42 |
| gfx938 | 4 | 2048 | 336.78 / 331.95 | 314.38 / 306.31 | 294.91 / 289.55 |
| gfx938 | 4 | 8192 | 1235.01 / 1227.89 | 1038.36 / 1029.90 | 1083.11 / 1076.08 |

## 最终性能：DP4 不均衡负载

同 T 的 skew/one_active 与均衡行保持相同总 token 数；混合行模拟一个 prefill rank 和三个 decode rank。0 表示该 rank 本步无 token，但仍参与 collective。

| 架构 | 各 rank token 数 | AGv（Eager / Graph） | RSv（Eager / Graph） |
|---|---|---:|---:|
| gfx936 | `[324, 64, 64, 64]` | 100.67 / 90.59 | 100.58 / 94.94 |
| gfx936 | `[516, 0, 0, 0]` | 71.43 / 58.92 | 66.78 / 61.89 |
| gfx936 | `[1290, 258, 258, 258]` | 190.66 / 185.14 | 209.65 / 204.34 |
| gfx936 | `[2064, 0, 0, 0]` | 150.22 / 147.12 | 176.73 / 172.23 |
| gfx936 | `[8192, 129, 129, 129]` | 625.67 / 607.47 | 773.08 / 765.77 |
| gfx938 | `[324, 64, 64, 64]` | 175.66 / 80.63 | 125.87 / 72.84 |
| gfx938 | `[516, 0, 0, 0]` | 167.86 / 56.75 | 118.58 / 42.72 |
| gfx938 | `[1290, 258, 258, 258]` | 177.30 / 146.79 | 137.16 / 120.71 |
| gfx938 | `[2064, 0, 0, 0]` | 179.35 / 132.72 | 130.10 / 113.79 |
| gfx938 | `[8192, 129, 129, 129]` | 524.87 / 516.87 | 461.95 / 455.39 |

## 最终性能：dispatch 负载对照

DP4、均衡输入、Graph 中位数（µs）。四列是互斥的调用形态，不能相加。FP32 router 和 top-k metadata 是通用框架分支对照，未确认为该 PCG 模型的实际 dtype/入口。

| 架构 | 每 rank T | hidden only | hidden + BF16 router | hidden + FP32 router | hidden + top-k weights/ids |
|---|---:|---:|---:|---:|---:|
| gfx936 | 129 | 50.78 | 73.69 | 81.84 | 74.64 |
| gfx936 | 516 | 103.80 | 138.76 | 149.26 | 118.25 |
| gfx936 | 8192 | 1142.63 | 1370.39 | 1580.88 | 1153.77 |
| gfx938 | 129 | 51.39 | 80.78 | 79.06 | 79.20 |
| gfx938 | 516 | 93.92 | 131.46 | 138.55 | 128.14 |
| gfx938 | 8192 | 1032.71 | 1227.89 | 1436.30 | 1044.73 |

## 最终性能：等长 RS 的原生对照

相同输入和输出合同；显式 `sizes=[T]*G` 走 grouped Reduce，`sizes=None` 走原生 ReduceScatter。这里比较两条 RCCL 路径，不是 custom kernel 对比 RCCL。

| 架构 | G | T | 显式 sizes（Eager / Graph） | sizes=None（Eager / Graph） | 显式 / 原生 Graph 耗时 |
|---|---:|---:|---:|---:|---:|
| gfx936 | 2 | 129 | 43.16 / 40.14 | 44.79 / 41.23 | 0.97× |
| gfx936 | 2 | 516 | 105.74 / 95.43 | 77.59 / 71.51 | 1.33× |
| gfx936 | 2 | 8192 | 978.97 / 977.33 | 770.11 / 767.79 | 1.27× |
| gfx936 | 4 | 129 | 84.53 / 79.01 | 76.59 / 73.20 | 1.08× |
| gfx936 | 4 | 516 | 209.75 / 204.12 | 153.90 / 150.57 | 1.36× |
| gfx936 | 4 | 8192 | 2219.66 / 2213.83 | 1813.93 / 1809.95 | 1.22× |
| gfx938 | 2 | 129 | 95.95 / 28.46 | 65.35 / 32.36 | 0.88× |
| gfx938 | 2 | 516 | 96.55 / 52.67 | 66.64 / 52.12 | 1.01× |
| gfx938 | 2 | 8192 | 378.48 / 371.95 | 441.54 / 435.82 | 0.85× |
| gfx938 | 4 | 129 | 123.98 / 52.36 | 69.26 / 54.66 | 0.96× |
| gfx938 | 4 | 516 | 128.02 / 114.46 | 108.27 / 101.42 | 1.13× |
| gfx938 | 4 | 8192 | 1038.36 / 1029.90 | 1083.11 / 1076.08 | 0.96× |

## 正确性与波动

每个架构/组大小完成 102 个 API/shape 用例，每个用例执行 1 次 Eager 和 5 次变化输入 Graph 的完整输出检查。四组作业均正常退出，共 816 条性能记录、7344 次按 rank 计数的正确性检查；零长度 rank 用例通过。9 个采样点的 P95 按 nearest-rank 计算，等于本组最大值，不宜当作充分采样的线上尾延迟。

| 架构 | G | 性能记录 | Event CV 中位数 | Event CV 最大值 | CV > 10% 的记录数 |
|---|---:|---:|---:|---:|---:|
| gfx936 | 2 | 204 | 0.52% | 4.41% | 0 |
| gfx936 | 4 | 204 | 0.31% | 12.52% | 2 |
| gfx938 | 2 | 204 | 0.59% | 8.15% | 0 |
| gfx938 | 4 | 204 | 0.68% | 14.35% | 1 |

所有波动样本均保留，没有为了降低耗时或 CV 筛除采样。CV > 10% 的点如下（µs）：

| 架构 / G | API | 模式 | sizes | median | P95 / max | CV |
|---|---|---|---|---:|---:|---:|
| gfx936 / 4 | ag_router_bf16 | eager | `[516, 0, 0, 0]` | 71.43 | 98.02 | 11.42% |
| gfx936 / 4 | ag_router_bf16 | graph | `[516, 0, 0, 0]` | 58.92 | 83.54 | 12.52% |
| gfx938 / 4 | ag_router_fp32 | graph | `[8, 8, 8, 8]` | 37.34 | 54.64 | 14.35% |
