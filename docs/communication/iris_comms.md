<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# Iris 通信接口使用说明

`aiter.ops.triton.comms` 提供基于 Iris 对称显存 heap 的 AG、RS 及 RS+RMSNorm+量化+AG 融合。支持 gfx936/gfx938 的单节点 HIP IPC，已覆盖 TP2/4/8；只支持 eager，Graph capture 会报错。

## 依赖与初始化

使用 [requirements-triton-comms.txt](../../requirements-triton-comms.txt) 固定的可选 Iris 依赖（提交 `905ec1cea8f350211a70c7d0b2bc11a09a6f6429`）。普通 AITER 导入不加载 Iris；使用本模块时需要兼容的 HCU Triton/DTK 环境。

```python
import os
import torch
import torch.distributed as dist
from aiter.ops.triton.comms import (
    IrisCommContext, all_gather, reduce_scatter,
    reduce_scatter_rmsnorm_quant_all_gather,
)

torch.cuda.set_device(int(os.environ["LOCAL_RANK"]))
dist.init_process_group("gloo")
world = dist.get_world_size()
try:
    with IrisCommContext(heap_size=32 << 20) as ctx:
        x = ctx.iris_ctx.empty((3, 129), dtype=torch.bfloat16)
        x.fill_(dist.get_rank() + 1)
        gathered = all_gather(x, ctx)  # [3*world,129]
        shard = reduce_scatter(gathered, ctx)  # [3,129]，跨rank求和后分片

        z = ctx.iris_ctx.empty((4 * world, 256), dtype=torch.bfloat16)
        z.fill_(dist.get_rank() + 1)
        gamma = torch.ones(256, dtype=torch.bfloat16, device="cuda")
        norm, quant, full = reduce_scatter_rmsnorm_quant_all_gather(
            z, gamma, ctx=ctx, epsilon=1e-6,
            quant_mode="none", do_allgather=True,
        )
        # norm: FP32 [4,256]；quant: None；full: BF16 [4*world,256]
        torch.cuda.synchronize()
finally:
    dist.destroy_process_group()
```

保存为脚本后用 `torchrun --standalone --nproc_per_node=2 example.py` 运行。context 使用全局 Gloo 组，不接收自定义子组参数；每 rank 先选择不同 GPU。

## 接口与布局

| 入口 | 输入 → 输出 |
|---|---|
| `IrisCommContext(heap_size=1<<30)` | 指定每 rank 对称 heap 字节数；进入 `with` 时初始化，退出时关闭 |
| `calculate_heap_size(M,N,dtype,world_size=None,quant_mode="none",all_gather=True,overhead_factor=1.2)` | 估算 RS 融合所需 heap 容量；多次独立分配要另计累计占用 |
| `all_gather(input_shard,ctx=None,block_m=64,block_n=64,group_size_m=8,num_sms=256)` | 连续 `[M_shard,N]` → `[TP*M_shard,N]`，按 rank 顺序拼接 |
| `reduce_scatter(input_tensor,ctx=None,block_m=16,block_n=64,group_size_m=8,num_sms=256)` | 连续 `[M,N]` → `[M/TP,N]`，跨 rank 求和后分片 |

AG/RS 支持 FP32/FP16/BF16，RS 用 FP32 累加后存回输入 dtype；M 必须整除 TP。`ctx` 虽有默认值，但当前调用必须显式提供已进入的 context。`block_m/block_n/group_size_m/num_sms` 为启动参数，各 rank 必须一致；通常保留默认值。

输入必须来自 `ctx.iris_ctx.empty/zeros`，属于当前对称 heap；各 rank 的 shape、dtype、heap 偏移及分配顺序必须一致，不能直接把普通 `torch.empty` 的输入交给这些 collective。AG/RS 的输出也消耗 heap 空间，长循环应注意累计分配容量。

## RS + RMSNorm + 可选量化 + 可选 AG

```python
normalized_shard, quantized_shard, gathered_output = (
    reduce_scatter_rmsnorm_quant_all_gather(
        input_tensor, gamma, epsilon=1e-6, ctx=ctx,
        quant_mode="none", do_allgather=True,
        rs_buffer=None, norm_buffer=None, fp8_out=None, gather_out=None,
    )
)
```

先对 `[M,N]` 做 RS 得到本 rank 的 `[M/TP,N]`，结果舍入到输入 dtype，再 RMSNorm；可选逐 token FP8 量化和 AG。当前 N≤16384、epsilon 有限且>0；gamma 为同设备连续 FP32/FP16/BF16 `[N]`，可与输入 dtype 不同。

| 模式 | normalized_shard | quantized_shard | gathered_output（启用AG时） |
|---|---|---|---|
| `quant_mode="none"` | FP32 `[M/TP,N]` | None | 输入 dtype `[M,N]` |
| `quant_mode="fp8_per_token"` | None | E4M3FN `[M/TP,N]` | E4M3FN `[M,N]` |

`do_allgather=False` 时第三项为 None。**FP8 每 token 的 scale 不在返回元组中**，输出不能当作统一 scale 的量化 Tensor 直接交给要求 scale 的下游 GEMM；需要 scale 的消费者应采用提供明确 scale 输出的 [CAR 量化接口](communication_ops.md#ar--rmsnorm--量化)。不支持 FP4 模式。

预分配 buffer 用于复用输出，要求同设备、连续、互不重叠且不与输入重叠：

- `rs_buffer`：输入 dtype `[M/TP,N]`。
- `norm_buffer`：FP32 `[M/TP,N]`。
- `fp8_out`：E4M3FN `[M/TP,N]`。
- `gather_out`：`[M,N]`，dtype 与上表对应，必须属于当前对称 heap，且各 rank 偏移一致。

## 生命周期与适用边界

接口含主机协调与屏障。所有 rank 必须以相同顺序完成调用和 `close()`；不要在某个 rank 独自退出时指望 collective close 恢复其余进程。先完成输出消费再关闭 context；关闭会 detach 导入的 peer 映射，本地 Tensor view 存活期间仍可能占用本地显存。

只支持单节点 IPC/eager；未支持 Graph 或跨节点。该模块不会自动替换 CAR/RCCL，也没有默认接入框架模型路由。

## 性能记录

日期2026-10-09，gfx936（BW200 / UBB BW1000，80 CU）与gfx938（BW1100，72 CU），均使用2张GPU、TP2、PyTorch 2.11.0、HIP 6.3.26113、IPC。每组30个样本全部保留，每个样本取两rank较慢值；†表示CV>10%，不据其中位数承诺稳定收益。HIP测量覆盖FP16/BF16，Iris及组封装覆盖BF16；下表展示代表性结果。这些是代表性输入的接口成本，不是完整模型吞吐；TP4/8性能不由TP2外推。

下表为BF16完整eager同步调用的墙钟时间，每样本一次调用，含主机元数据检查/协调、内部屏障、默认INFO日志及最终设备同步。AG/RS包含输出heap分配；融合接口使用预分配rs/norm/quant/gather输出。初始化、首次Triton编译、预热、参考计算和外部rank对齐不计入。

Triton版本：gfx936为`3.6.0+dtk2604.torch2110.2609141452.geb21b8`，gfx938为`3.6.0+dtk2604.torch2110.2609231415.g8cce4a`；Iris使用本文固定提交的独立源码。AG/RS保持默认启动参数；输入为周期数列加rank偏移，gamma=1、epsilon=1e-6。融合接口不返回FP8 scale，表中量化项仍须遵守上文输出约定。

| 接口 | 输入形状 | gfx936 median μs（CV） | gfx938 median μs（CV） |
|---|---|---:|---:|
| AG | `4×2048` | 1089.41（3.61%） | 1154.09（3.88%） |
| AG | `128×8192` | 1097.39（2.18%） | 1083.32（1.98%） |
| RS | `4×2048` | 1043.80（2.47%） | 1096.31（5.25%） |
| RS | `128×8192` | 1117.23（4.85%） | 1037.25（4.70%） |
| RS+RMSNorm | `4×2048` | 1401.89（62.48%）† | 1525.61（11.33%）† |
| RS+RMSNorm | `128×8192` | 1498.27（21.56%）† | 1424.90（7.16%） |
| RS+RMSNorm+AG | `4×2048` | 1368.32（2.66%） | 1364.40（15.54%）† |
| RS+RMSNorm+AG | `128×8192` | 1411.88（8.86%） | 1490.48（9.30%） |
| RS+RMSNorm+FP8 | `4×2048` | 1357.89（2.13%） | 1484.44（1.64%） |
| RS+RMSNorm+FP8 | `128×8192` | 1620.67（8.35%） | 1467.52（8.56%） |
| RS+RMSNorm+FP8+AG | `4×2048` | 1393.53（1.99%） | 1470.79（9.74%） |
| RS+RMSNorm+FP8+AG | `128×8192` | 1731.45（7.37%） | 1395.90（10.80%）† |

本矩阵约毫秒级的eager成本包含主机协调，不代表Triton kernel本身耗时。GPU event区间包围含主机屏障的调用时，也可能包含设备等待，不能当作纯kernel时间。不要与CAR/QR的Graph内设备时间计算直接加速比。

实现见 [Iris 通信模块](../../aiter/ops/triton/comms/__init__.py)。其他后端见 [通信接口总览](communication_ops.md)。
