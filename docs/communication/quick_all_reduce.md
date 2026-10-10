<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# Quick AllReduce 使用说明与性能结果

提供两类单节点通信入口：HIP `QuickAllReduce` 支持 FP16/BF16 及多种通信编码；可选的 FlyDSL `QuickAllReduceInt4` 接收 BF16，使用 INT4 通信，并默认对小载荷使用 HIP FP。两者均采用非原地输出，已验证 gfx936/gfx938、TP2/4/8 的 IPC 通信。

## HIP Quick AllReduce

### 初始化与调用

在 Python 导入 AITER **之前**设置环境变量，所有 rank 使用相同配置：

```bash
export AITER_QUICK_REDUCE_QUANTIZATION=FP
export AITER_QUICK_REDUCE_CAST_BF16_TO_FP16=0
```

```python
import os
import torch
import torch.distributed as dist
from aiter.dist.device_communicators.quick_all_reduce import QuickAllReduce

local_rank = int(os.environ["LOCAL_RANK"])
torch.cuda.set_device(local_rank)
dist.init_process_group("gloo")
device = torch.device("cuda", local_rank)
comm = QuickAllReduce(dist.group.WORLD, device)
try:
    x = torch.randn((1024, 8192), dtype=torch.bfloat16, device=device)
    if comm.disabled or not comm.should_quick_allreduce(x):
        raise RuntimeError("QR 未启用或该输入不满足准入条件")
    y = comm.quick_all_reduce(x)  # 可用 out= 复用输出
    residual = torch.zeros_like(x)
    weight = torch.ones(8192, dtype=x.dtype, device=device)
    if comm.should_quick_allreduce_rmsnorm(x, residual, weight, 8192):
        norm, residual_out = comm.quick_all_reduce_rmsnorm(
            x, residual, weight, 1e-6, 8192,
        )
    torch.cuda.synchronize()
    dist.barrier()
finally:
    comm.close()
    dist.destroy_process_group()
```

QR + RMSNorm 计算 `s=AR(x)+residual`，返回 `(RMSNorm(s), s)`。所有输入同设备、同 FP16/BF16 dtype、连续；weight 为 `[hidden_dim]`。行字节数须 ≤32768 且整除32768。它没有 CAR 的 Gemma、padding 或 FP8 输出 scale 参数。

### 模式和限制

| 配置 | 含义 |
|---|---|
| `AITER_QUICK_REDUCE_QUANTIZATION` | `FP` / `FP8` / `INT6` / `INT4` / `INT3`；`NONE` 禁用高层 QR。未设置时高层 QR 也不启用 |
| `AITER_QUICK_REDUCE_CAST_BF16_TO_FP16` | 默认1，允许 BF16 转 FP16 运算；设0保留 BF16 路径 |
| `AITER_QUICK_REDUCE_MAX_SIZE_BYTES_MB` | QR 最大字节容量，以 MiB 设置；默认0使用 native 默认容量，可用 `qr_max_size()` 查询 |

INT3 仅支持 TP2。FP8/INT6/INT4/INT3 是通信内部编码，接口输出仍是输入 dtype，不返回编码数据或 scale。量化模式存在误差；BF16→FP16 也会缩小动态范围，输入较大时可能溢出，需按模型选择。

`should_quick_allreduce` 同时检查：连续非空 FP16/BF16 GPU Tensor、对象绑定设备、总字节数整除16、容量上限、拓扑和最小载荷。当前最小载荷如下，单位 MiB；开启 BF16→FP16 时 BF16 使用 FP16 那一行。

| 有效 dtype | TP | FP | FP8 | INT6 | INT4（INT3 同列，限TP2） |
|---|---:|---:|---:|---:|---:|
| FP16 | 2 | 1 | 2 | 2 | 1 |
| FP16 | 4 | 1 | 16 | 4 | 2 |
| FP16 | 8 | 16 | 4 | 4 | 2 |
| BF16 | 2 | 2 | 8 | 8 | 8 |
| BF16 | 4 | 8 | 64 | 64 | 16 |
| BF16 | 8 | 16 | 2048 | 2048 | 2048 |

这些是当前高层路由门限，不代表 HCU 全部工作负载的最优分界。直接 `quick_all_reduce()` 不代替准入判断。已有框架集成会按条件选择后端；独立使用者需自行处理不适用的输入。

构造要求同节点 CPU/Gloo 组，每 rank 一张不同 GPU；TP>2 检查全互联拓扑。显式请求 `AITER_AR_TRANSPORT=fabric` 时 HIP QR 禁用。初始化与句柄交换由所有 rank 共同进行。Graph 前完成初始化/JIT/预热；QR 使用固定 IPC buffer，无需 CAR 的 `capture()` 上下文。同一对象的调用不得重叠，结束后先完成所有通信、销毁 Graph，再同步各 rank 并 `close()`。

### Native 接口与句柄兼容

以下接口从 `aiter.ops.quick_all_reduce` 导入，也由 `aiter` 导出。用于已有框架自己管理 QR 对象、IPC 生命周期的场景。

| 接口 | 契约 |
|---|---|
| `init_custom_qr(rank, world_size, qr_max_size=None)` | 返回 native handle；rank 为组内 rank；显式正容量为32 KiB的倍数且≤2 GiB，0/None 使用默认容量 |
| `qr_get_handle(fa, out_ptr=None)` | 省略 out_ptr 时返回连续 CPU uint8[64]；提供时写调用方拥有的 host 地址 |
| `qr_open_handles(fa, handle_ptrs)` | 接收按组内 rank 排列的 CPU handle Tensor 列表或 host 地址列表，包含本 rank |
| `qr_all_reduce(fa, inp, out, quant_level, cast_bf2half=False)` | 写预分配 out，返回 None；输出与输入同形状/dtype/设备且不重叠 |
| `qr_all_reduce_rmsnorm(fa, inp, residual_inp, residual_out, out, weight, eps, hidden_dim, quant_level, cast_bf2half=False)` | 写 residual_out 和 norm out，返回 None |
| `qr_max_size()` / `qr_destroy(fa)` | 查询默认容量 / 释放句柄 |

native quant_level 映射为 `FP=0, FP8=1, INT6=2, INT4=3, INT3=4, NONE=5`。**高层 `NONE` 禁用 QR，直接 native 传5则按 FP codec 执行**；无量化 native 调用建议明确传0。CPU 句柄及 host 地址须在 native 复制其内容之前存活，不能传 GPU 地址充当 host handle。独立直接使用 native Tensor 入口时，应先调用 `aiter.ops.custom_all_reduce.meta_size()` 加载共享 Tensor 绑定；高层框架通常已经加载。

## FlyDSL INT4 接口

```python
from aiter.ops.flydsl import QuickAllReduceInt4

# 前提：已设置本地 GPU，所有 rank 已初始化 CPU/Gloo 组。
cpu_group = dist.group.WORLD
x = torch.randn(131072, dtype=torch.bfloat16, device=device)
y = torch.empty_like(x)
with QuickAllReduceInt4(
    group=cpu_group, device=device,
    rank=dist.get_rank(cpu_group), world_size=dist.get_world_size(cpu_group),
    super_tile=8, grid_cap=None, small_payload_policy="fp",
) as comm:
    comm.compile(x, y)  # 各 rank 一同预编译/预热，会写 y
    comm.allreduce(x, y)
    torch.cuda.synchronize()
```

| 参数 / 方法 | 含义 |
|---|---|
| group / rank / world_size | 同节点 CPU 进程组、组内 rank、组大小；显式传入 world_size，支持2/4/8 |
| device | 当前进程可见的 GPU 索引或 torch.device |
| super_tile | 1或8，默认8；tile 较少时自动使用1 |
| grid_cap | 默认每 CU 一个 persistent workgroup；显式值只限制网格，按 `8/TP` 向下对齐 |
| small_payload_policy | 默认 `fp`：≤32 KiB 使用 HIP FP；`int4`：小载荷也使用 INT4 |
| `compile(inp, out, stream=None)` | 捕获外集体编译/预热，输出会被改写 |
| `allreduce(inp, out, stream=None)` | 写 out，返回 None；支持预编译后的 Graph |
| `close()` / `with` | 所有 rank 有序共同释放；重复 close 无效 |

**输入契约：**同设备、连续 BF16，输入输出大小相同、不重叠、地址按16字节对齐、元素数为8的倍数，总字节数小于4 GiB；允许空张量。各 rank 的长度及调用顺序必须一致。支持当前 Torch stream、指定 Torch stream、原始 stream handle 或 FlyDSL Stream；跨流调用需要调用方建立依赖，同一对象不允许并发操作。

依赖兼容的 Hygon FlyDSL 与 HCU 编译链，已测版本为 `0.2.0+dtk2604.torch2110.2610081510.g23525f`。普通 `import aiter` 不需要 FlyDSL，访问此类时才加载依赖。需要编译器的 `as_ir_value`、i64 buffer resource 等支持；仅安装同名的其他版本不能保证可用。

### 小载荷与精度

默认 ≤32 KiB 路径使用 HIP QR 的 FP codec，保持 BF16，不做 INT4 或 BF16→FP16 转换；需可编译/加载原生 QR 与 CAR 模块。其求和按 rank 顺序逐次 BF16 舍入，不承诺与 FP32 累加后一次舍入逐位相同。

INT4 使用两阶段量化，部分内部运算为 FP16，不能保留 BF16 全动态范围，也不保证任意输入的固定误差上界。显式 `small_payload_policy="int4"` 下，8/24元素的部分随机输入曾只有约16 dB SQNR。默认小载荷 FP 策略用于避开这类误差，32 KiB 不是通用性能最优阈值。

已测大载荷到320 MiB+16 B，包含连续128次变化输入 Graph 重放；该矩阵最低 SQNR 约19.18 dB。SQNR 为 `10*log10(sum(reference²)/sum(error²))`，数值越大越好。模型是否接受量化误差，需使用模型任务指标判断。

该类仅支持 gfx936/gfx938 的单节点 HIP IPC；不支持 Fabric 或跨节点，不自动替换原有框架路由。默认网格按运行设备 CU 数确定，下面设备分别为80/72；不能只按 gfx 名称硬编码 CU 数。

## 性能结果

日期2026-10-08，gfx936/bmz25 与 gfx938/nmz-2，使用上述 FlyDSL 版本，接口实现版本 `c0fb54e6`。固定 IPC，FP 对照使用 native HIP QR 的 `quant_level=0, cast_bf2half=False`，不应用高层最小载荷门限；RCCL 使用 BF16 并包含 input→output copy，使输出语义一致。INT4 与 FP 对照的精度不同，不能把时间比当作无损替换收益。

每次 Graph 包含16次同一操作，每组20个 GPU event 样本，各样本取所有 rank 中最慢的每次均值。编译、预热和输入构造不计入；输入为 `seed=300+rank` 的 `randn*0.1` 转 BF16。下表为 **每 rank 输入64 MiB**，默认网格，单位 μs。

| 架构 | TP | INT4 median | HIP FP median | RCCL BF16+copy median | HIP FP / INT4 | INT4 CV |
|---|---:|---:|---:|---:|---:|---:|
| gfx936 | 2 | 409.74 | 587.52 | 951.32 | 1.43× | 0.25% |
| gfx936 | 4 | 391.07 | 915.14 | 1239.90 | 2.34× | 0.49% |
| gfx936 | 8 | 435.41 | 1104.72 | 1392.87 | 2.54× | 1.24% |
| gfx938 | 2 | 536.46 | 530.74 | 676.73 | 0.99× | 0.17% |
| gfx938 | 4 | 483.67 | 862.73 | 907.51 | 1.78× | 0.51% |
| gfx938 | 8 | 514.07 | 1097.27 | 1028.30 | 2.13× | 0.99% |

完整默认网格测量覆盖2架构×TP2/4/8×32 KiB、256 KiB、2/8/32/64 MiB×3后端，共108组，包含 median/P95/max/CV/SQNR。`backend=int4_api` 表示调用该公共类，**32 KiB 的 `effective_backend=hip_fp`，不能标成 INT4 kernel 耗时**。CV 使用百分比。

- 在这组64 MiB输入上，TP4/8的 INT4 快于 HIP FP。gfx938 TP2 的32/64 MiB分别慢约1.5%/1.1%，不适合统一替换。
- 全部默认网格样本均纳入统计；CV>10%的测量视为高波动结果。例如 gfx938 TP2 的32 KiB API调用 CV约310.58%，TP8/2 MiB INT4 CV约74.56%，不能凭这些行的中位数宣称稳定收益。
- 以上为设备侧通信成本，不包含完整模型执行和编译耗时。HIP FP8/INT6/INT4/INT3及QR+RMSNorm的专项结果见下文；FlyDSL INT4结果不能代替HIP INT4结果。

实现：[HIP 对象](../../aiter/dist/device_communicators/quick_all_reduce.py)、[HIP native 接口](../../aiter/ops/quick_all_reduce.py)、[FlyDSL 对象](../../aiter/ops/flydsl/quick_allreduce_int4.py)。其他通信入口见 [通信接口总览](communication_ops.md)。

## HIP 多编码模式与 QR+RMSNorm 专项性能

日期2026-10-09，gfx936/bmz25（80 CU）与gfx938/nmz-2（72 CU），均使用物理卡6/7、TP2、PyTorch 2.11.0、HIP 6.3.26113、IPC。每组30个样本全部保留，每个样本取两rank较慢值；†表示CV>10%，不据其中位数承诺稳定收益。HIP测量覆盖FP16/BF16，Iris及组封装覆盖BF16；下表展示代表性结果。这些是代表性输入的接口成本，不是完整模型吞吐；TP4/8性能不由TP2外推。

下表为BF16，关闭BF16→FP16转换，直接native接口，不应用高层最小载荷门限。每个Graph16次操作，报告GPU event每次耗时。输入为`((arange % 37 - 18)/32 + rank/32)`转BF16，RMS residual=0.125、weight=1、eps=1e-6；所有量化模式在计时前后通过预设误差检查。

| 接口 | 输入形状 | gfx936 median μs（CV） | gfx938 median μs（CV） |
|---|---|---:|---:|
| FP | `4×2048` | 16.01（5.15%） | 17.84（3.39%） |
| FP | `128×8192` | 34.25（6.28%） | 34.03（2.10%） |
| FP + RMSNorm | `4×2048` | 45.72（1.55%） | 54.16（2.16%） |
| FP + RMSNorm | `128×8192` | 73.11（0.79%） | 79.46（1.26%） |
| FP8 | `4×2048` | 104.80（3.14%） | 125.81（14.24%）† |
| FP8 | `128×8192` | 108.40（0.62%） | 125.39（1.79%） |
| FP8 + RMSNorm | `4×2048` | 132.03（0.75%） | 156.77（0.82%） |
| FP8 + RMSNorm | `128×8192` | 150.72（2.15%） | 176.07（2.74%） |
| INT6 | `4×2048` | 117.54（1.64%） | 139.87（1.19%） |
| INT6 | `128×8192` | 120.98（1.46%） | 140.98（1.64%） |
| INT6 + RMSNorm | `4×2048` | 145.72（0.82%） | 174.19（1.07%） |
| INT6 + RMSNorm | `128×8192` | 161.43（1.38%） | 189.37（2.57%） |
| INT4 | `4×2048` | 117.06（1.06%） | 139.96（3.50%） |
| INT4 | `128×8192` | 120.78（0.71%） | 139.67（0.94%） |
| INT4 + RMSNorm | `4×2048` | 144.09（0.84%） | 172.97（1.47%） |
| INT4 + RMSNorm | `128×8192` | 168.14（8.23%） | 196.76（0.36%） |
| INT3 | `4×2048` | 117.86（1.49%） | 140.81（1.79%） |
| INT3 | `128×8192` | 120.99（0.71%） | 140.37（3.22%） |
| INT3 + RMSNorm | `4×2048` | 144.18（0.97%） | 173.26（1.06%） |
| INT3 + RMSNorm | `128×8192` | 160.19（1.08%） | 186.00（0.60%） |

在这两种输入大小下，BF16量化QR明显慢于FP，且精度不同；不能用压缩位宽推定延迟收益。这些HIP编码结果与上文FlyDSL INT4属于不同实现、输入和采样，不进行跨批次直接提速比较。
