<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# topk_per_row

## 1. 当前接口、用法与性能

`topk_per_row` 对 FP32 分数矩阵逐行选择最大的 **K=2048** 个元素，可用于按分数筛选候选位置。矩阵列数 `seq` 是存储宽度，各行实际参与选择的长度由区间或 `seq_lens` 指定，可以随请求和解码步变化。

### 接口与约束

接口定义见 [topk_per_row.py](../aiter/ops/topk_per_row.py)。通常使用自动分配输出的 Python 包装接口：

| 接口 | 输入与选择范围 | 返回值 |
|---|---|---|
| `topk_per_row_prefill(logits, row_starts, row_ends, *, return_values=False)` | `logits: [rows, seq]`；第 `i` 行选择 `[row_starts[i], row_ends[i])` | `(indices, values)`；未请求 values 时为 `None` |
| `topk_per_row_decode(logits, next_n, seq_lens)` | `logits: [batch*next_n, seq]`；第 `i` 行选择 `[0, seq_lens[i//next_n]-next_n+i%next_n+1)` | `indices` |

- 所有张量放在同一 GPU；`logits` 为 FP32，区间和长度张量为 int32。`row_starts`、`row_ends` 形状为 `[rows]`，`seq_lens` 为 `[batch]`；调用方应保证选择范围在输入内，且 `next_n>=1`。
- `indices` 为 `[rows, 2048]` 的 int32；可选 `values` 为相同形状的 FP32。**prefill 下标相对于该行的 `row_starts`**，转换为原矩阵列下标时需加回起点。输出不保证按数值排序或并列值的稳定次序。
- 仅输出下标时，有效长度不足 2048 的行返回全部有效位置，其余位置填 `-1`。
- prefill 默认与 decode 使用 histogram 路径；`return_values=True` 使用 AIR radix 路径，当前应使用列连续的输入（`stride(1)==1`），其性能不能直接套用下表。

需要复用输出缓冲区时，可调用底层接口；两者原地写入输出并返回 `None`，`stride0/stride1` 使用 `logits.stride(0/1)`：

```python
top_k_per_row_prefill(logits, rowStarts, rowEnds, indices,
                     numRows, stride0, stride1, values=None)
top_k_per_row_decode(logits, next_n, seqLens, indices,
                    numRows, stride0, stride1)
```

### 用法

```python
import torch
from aiter.ops.topk_per_row import topk_per_row_prefill, topk_per_row_decode

# Prefill：每行可以选择不同长度的区间。
logits = torch.randn(4, 8192, device="cuda", dtype=torch.float32)
starts = torch.zeros(4, device="cuda", dtype=torch.int32)
ends = torch.tensor([4096, 6144, 8192, 8192], device="cuda", dtype=torch.int32)
indices, _ = topk_per_row_prefill(logits, starts, ends)  # [4, 2048]
# 需要分数时：indices, values = topk_per_row_prefill(
#     logits, starts, ends, return_values=True)

# Decode：batch=2，每个请求展开 next_n=4 行，共 8 行。
next_n = 4
logits = torch.randn(2 * next_n, 8192, device="cuda", dtype=torch.float32)
seq_lens = torch.tensor([4096, 8192], device="cuda", dtype=torch.int32)
indices = topk_per_row_decode(logits, next_n, seq_lens)  # [8, 2048]
# 第一个请求的四行有效长度依次为 4093、4094、4095、4096。
```

### 当前配置与性能

两个底层接口使用 `module_topk_per_row`。其 [JIT 配置](../aiter/jit/optCompilerConfig.json) 设置 `prefer_hipcc=false`，采用默认的 aicc 优先选择逻辑，保留原有参数并增加第二节的两个选项。

以下为 **2026-10-19 并列值修复后源码**的性能记录：FP32、K=2048、确定性唯一值输入，仅输出下标；使用预分配输出直接调用 JIT 模块，统计 20 轮 Graph GPU Event 单次调用耗时中位数，每轮 20 次调用 × 5 次重放。时间单位为 **µs**，不包含首次编译和 Python 包装函数的输出分配。

| 测试配置 | gfx936 | gfx938 |
|---|---|---|
| 设备 / CU 数 | BW1000 64G / 80 | BW1100 / 72 |
| PyTorch / HIP | 2.11.0 / 6.3.26113 | 同左 |
| aicc | Clang 18，`bd8aa66b` | Clang 18，`5f9d5e50` |
| hipcc | Clang 17，`ff5bf917` | 同左 |

表中 **aicc 均包含两个选项**；`rows` 为展开后的行数，decode 的 `batch=rows/next_n`。

| 接口 | rows | seq | next_n | gfx936 hipcc | gfx936 aicc | gfx938 hipcc | gfx938 aicc |
|---|---:|---:|---:|---:|---:|---:|---:|
| prefill | 1 | 4096 | — | 8.363 | 8.352 | 9.581 | 9.535 |
| prefill | 32 | 8192 | — | 10.816 | 10.504 | 12.417 | 11.803 |
| prefill | 128 | 16384 | — | 22.251 | 21.600 | 24.806 | 23.726 |
| prefill | 4096 | 4096 | — | 279.320 | 280.313 | 353.581 | 355.178 |
| decode | 1 | 4096 | 1 | 8.085 | 8.046 | 9.251 | 9.238 |
| decode | 4 | 8192 | 1 | 10.475 | 10.308 | 12.004 | 11.603 |
| decode | 32 | 8192 | 2 | 10.838 | 10.606 | 12.397 | 11.811 |
| decode | 128 | 16384 | 4 | 22.407 | 21.762 | 24.709 | 23.940 |

**已测结果总体持平到小幅领先。** 两个架构各有 7/8 项的 aicc 耗时更低，降幅分别为 0.13%～2.93% 和 0.14%～4.94%；`prefill(4096, 4096)` 分别慢 0.36% 和 0.45%。两种编译器分开测量，gfx938 部分项目使用不同物理卡，因此不足 1% 的差异不能认定为稳定优势，也不能推导所有 shape 均更快。

模块更名后已按上述配置重新构建，并在 gfx936/gfx938 上通过公开接口、并列值及原始 `decode(rows=16, seq=65536, next_n=4)` 的输入更新与 Graph 回归；更名后未重新计时。上述性能表不覆盖 64K、prefill values 路径或模型端到端收益。

## 2. 两个编译选项的作用与影响

```text
-mllvm -unroll-runtime=true
-mllvm -amdgpu-atomic-optimizer-strategy=None
```

| 选项 | 作用 | 对 topk_per_row 的影响 |
|---|---|---|
| `-unroll-runtime=true` | 允许迭代次数在运行时确定的循环参与展开；是否展开及展开倍数仍由成本模型决定 | 最终候选排序循环的长度动态变化。展开可减少循环控制开销，并为 LDS 读取与比较提供更多调度空间；不减少比较总量，也不保证固定展开倍数或相同向量化结果 |
| `-amdgpu-atomic-optimizer-strategy=None` | 关闭编译器的原子聚合优化，保留源码中的原子操作 | 聚合可减少同一 wave 内同址原子的争用，但需要额外的 lane 选择、扫描及返回值恢复。关闭后省去这些控制开销，同时失去减少原子次数的收益，因此效果依赖 shape 和输入分布 |

编译器分析记录《GFX936上topk算子aicc性能不如hipcc》中，所测 hipcc 默认允许 runtime-unroll、关闭原子聚合；对应 aicc 的默认行为不同。对齐这两项后，报告中的 16K 用例消除了 aicc 落后，而较短序列原先较大的优势也随之缩小。这是特定版本和用例的结果，不能将“seq 越大越受益”当成通用规律。第一节列出的是修复后源码的实测结果。

对 `module_topk_plain`，既有独立补测中 runtime-unroll 未显示可辨认的性能变化；关闭聚合主要影响 AIR 路径，其几何平均耗时在 gfx936/gfx938 上分别下降约 **4.79% / 5.91%**，但个别用例回退约 **2%～3%**，Sort/Filter/Merge 路径基本不变。该补测使用修复前源码，gfx936 采用 Graph、gfx938 采用 eager 并另做 Graph 复核，已排除输入更新失败用例；这些数据用于说明编译策略的取舍，不代表当前 plain 的完整性能或正确性结论。

当前两个选项仅配置到 `module_topk_per_row`，不作为全部 AITER 模块的统一参数。

## 3. 暂不与 topk_plain 合并的原因

两模块均编译 [topk_per_row.cu](../csrc/kernels/topk_per_row.cu)，其中 plain 依赖其 AIR radix 和 workspace 实现；共享源码并不意味着公开接口使用相同路径。

1. **编译策略需要独立控制。** per-row 已采用双选项；plain 的收益集中在 AIR，且仍有回退，合并会将相同选项施加到用途不同的接口上。
2. **没有已证实的额外运行性能收益。** 既有合并对照中，对应 kernel 指令序列一致，延迟差异在噪声量级。
3. **仅使用 per-row 时会增加冷启动成本。** 合并后还需编译 plain 的其他实现；已有单次构建观察从约 42～66 秒增加到 184～247 秒，仅用于说明成本，不作为严格编译速度对比。
