<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# blockwise_scaled_cast_transpose 算子说明与性能报告

本接口面向 Transformer 推理/训练中的 FP8/INT8 blockwise 量化数据准备：对连续输入 `[M, K]` 按 `1×128`（rowwise）/`128×1`（columnwise）分块计算 amax → scale，将输入量化为 INT8 或 FP8（e4m3/e5m2），可选同时产出 **转置输出**（columnwise GEMM_READY 布局，供 `K×N` GEMM 直接消费）与 **COMPACT 布局**（all-gather 就绪）。单次调用产出双布局双 scale，等价于 TransformerEngine 的 `blockwise scaled cast + transpose` 复合操作。

本算子由原实现（**origin**，框架内同名算子）移植至 aiter 框架并完成性能对齐，接口、实现与对比数据见本文各节。

## 算子功能

对输入按 block_len=128 分块（rowwise 沿 K 维 `1×128`，columnwise 沿 M 维 `128×1`）：

```text
amax[m, k//128]     = max(|input[m, k_block]|)                    # 分块 amax 归约（warp shfl）
scale[m, k//128]    = amax / 448（fp8）或 127（int8）             # pow2_scale=True 时取 2 的幂
output[m, k]        = quantize(input[m, k] * scale)               # INT8: 饱和舍入；FP8: 硬件 packed 转换
output_t[k, m]      = output[m, k] 的转置（columnwise GEMM_READY）
scale_inv            = 1 / scale（写入调用方缓冲）
```

- 单次 launch 内完成「load → smem 中转 → amax 归约 → scale 计算 → 量化 → 转置写回」全流程，rowwise 与 columnwise 双 kernel（各 2 个模板变体：aligned / non-aligned）。
- 输出**原地写入**调用方缓冲，接口无返回值；仅 columnwise（不传 rowwise 输出）与 COMPACT 布局均为一等支持路径。
- `block_len` 仅支持 128（`1×128`/`128×1` 量化分组）；非法值与非连续输入 fail-fast 抛 `RuntimeError`。
- 边界 case（`block_len≠128`、dtype 不一致、flag mismatch、非连续输入）按异常契约抛错，测试 exc 组 6/6 覆盖。

## 接口与参数

```python
from aiter.ops.blockwise_scaling import blockwise_scaled_cast_transpose

blockwise_scaled_cast_transpose(
    input, output, scale_inv, output_t, scale_inv_t,
    block_len, block_scaling_dim, rowwise, columnwise,
    epsilon, pow2_scale, all_gather_usage, out_dtype,
)
```

也可经包级导出 `aiter.blockwise_scaled_cast_transpose(...)` 调用。

| 参数 | 类型 / 形状 | 含义与约束 |
| --- | --- | --- |
| `input` | Tensor `[M, K]`，连续 | 输入激活；dtype ∈ {fp32, fp16, bf16} |
| `output` | 可选 Tensor `[M, K]`，连续 | **输出**：rowwise 量化结果；`rowwise=True` 时必填；dtype ∈ {int8, float8_e4m3fn, float8_e5m2} |
| `scale_inv` | 可选 Tensor `[M, ceil(K/128)]`，连续 | **输出**：rowwise 反量化 scale（`1/scale`，fp32） |
| `output_t` | 可选 Tensor `[K, M]`，连续 | **输出**：columnwise 量化结果（GEMM_READY 为转置布局）；`columnwise=True` 时必填 |
| `scale_inv_t` | 可选 Tensor `[ceil(M/128), K]`，连续 | **输出**：columnwise 反量化 scale |
| `block_len` | Python `int` | 量化块长，仅支持 128 |
| `block_scaling_dim` | Python `int` | 量化维度，仅支持 1（1d 分块） |
| `rowwise` | Python `bool` | 是否计算 rowwise 输出 |
| `columnwise` | Python `bool` | 是否计算 columnwise 输出 |
| `epsilon` | Python `float` | amax 下限保护（防全零块 scale=0） |
| `pow2_scale` | Python `bool` | scale 是否对齐到 2 的幂（UE8M0 兼容） |
| `all_gather_usage` | Python `bool` | columnwise 输出布局开关：`True`=COMPACT（all-gather 就绪），`False`=GEMM_READY（转置布局） |
| `out_dtype` | `torch.dtype` | 量化输出类型：`torch.int8` / `torch.float8_e4m3fn` / `torch.float8_e5m2` |
| 返回值 | `None` | 输出原地写入，无返回张量 |

所有张量须在同一 HIP 设备且连续；`output`/`scale_inv` 的有无必须与 `rowwise` 一致、`output_t`/`scale_inv_t` 与 `columnwise` 一致（违反抛 `RuntimeError`）。接口对 device / dtype / shape / contiguity 做完整静态契约检查。

## 实现与文件

| 文件 | 内容 |
| --- | --- |
| `csrc/kernels/blockwise_scaled_cast_transpose.cu` | 双 kernel 正式实现（rowwise + colwise，各 aligned/non-aligned 模板变体） |
| `csrc/include/blockwise_scaled_cast_transpose.h` | kernel 模板声明、Vec 类型设施、超参常量 |
| `csrc/include/blockwise_common.h` | fp8 类型换源（c10 `at::Float8_e4m3fn/e5m2`）、scale 计算设施 |
| `csrc/pybind/blockwise_scaling_pybind.cu` | pybind 绑定（13 参） |
| `aiter/ops/blockwise_scaling.py` | Python API stub |
| `aiter/jit/optCompilerConfig.json` → `module_blockwise_scaling` | JIT 模块配置（`prefer_hipcc: true`，见下） |

实现要点：

- **gfx938 fp8 硬件转换**（性能关键）：fp8 输出量化点使用 `__builtin_hcu_cvt_pk_fp8_f32`/`__builtin_hcu_cvt_pk_bf8_f32` 硬件 packed 转换——2 条 cvt 指令产出 4 元素，以 `uint32` 单写覆盖输出（写合并）；非 gfx938 架构自动回退软件 RNE 位操作（与 `silu_mul_quant_kernels.cu` 同源实现）。
- **编译器基座**：JIT 配置 `prefer_hipcc: true` 使 aiter 使用 hipcc/dcc 工具链（与原实现构建栈一致）。实测 dcc 相对 aicc 默认产物在 int8 大负载 case 有 -25~30% 收益（编译器 codegen 调度差异，非 flags 效应——已消融验证 json flags 配置零贡献）。
- **向量化和分块**：rowwise 512 线程（8 warps）、colwise 256 线程；LDS 中转 + 列主读转置；kNVecIn=8 / kNVecOut=16 向量访存；VGPR 收敛至 28/64。

## 性能数据

测试平台：nmz27（gfx938, 72CU, sramecc+:xnack-），DTK dcc/hipcc 基座，`HIP_VISIBLE_DEVICES=3`；对比口径：event 计时（测试脚本打印，35 case 可比全集）与 hipprof kernel 口径（`prof_*_AvgNs`）。数据为定稿值（三处采集坏点已复采仲裁，全 35 case 无排除行）。

### event 全集（35 case，aiter vs origin）

**全集几何平均 ≈ 0.94**（<1.00 即 aiter 整体更快）：

| 分组 | n | aiter/origin 几何平均 | 说明 |
| --- | --- | --- | --- |
| INT8 输出（GEMM/COMPACT） | 6 | 1.02 | 持平 |
| FP8 GEMM/对齐 shape | 21 | **0.97** | 追平~反超 |
| FP8 非对齐 ragged shape | 8 | **0.82** | 反超 15~27% |
| **全集** | 35 | **≈0.94** | — |

代表 case（impl ms，aiter / origin / 比值）：

| case | aiter | origin | 比值 |
| --- | --- | --- | --- |
| default:1 fp32→int8 COMPACT | 0.162 | 0.159 | 1.02 |
| dtype:2 fp32→e4m3 | 0.052 | 0.052 | 1.00 |
| dtype:8 bf16→e4m3 | 0.031 | 0.032 | 0.97 |
| layout:1 bf16→e4m3 GEMM | 0.030 | 0.031 | 0.97 |
| size:2 4096² bf16→e4m3 | 0.086 | 0.088 | 0.98 |
| size:7 16384×7168 bf16→e4m3 | 0.537 | 0.570 | 0.94 |
| size:9 16384×7168 fp32→int8 COMPACT | 2.541 | 2.525 | 1.01 |
| ragged:2 M2000×K2000 COMPACT | 0.070 | 0.092 | **0.76** |
| ragged:7 M2112×K2112 GEMM | 0.044 | 0.052 | **0.85** |

遗留观察点：ragged:3（M=2112 半对齐）比值 1.17，源于半对齐 shape 的向量路径受限。

### kernel 口径（hipprof，rowwise/colwise µs）

| case | aiter R/C | origin R/C | 比值 R/C |
| --- | --- | --- | --- |
| dtype:2 fp32→e4m3 | 20.6 / 30.7 | 20.8 / 30.8 | 0.99 / 1.00 |
| layout:1 bf16→e4m3 | 13.5 / 16.5 | 14.6 / 16.7 | 0.93 / 0.99 |
| size:6 16384×4096 | 138.1 / 166.2 | 147.1 / 181.8 | 0.94 / **0.91** |
| ragged:1 M2000×K2000 | 17.2 / 24.0 | 21.6 / 30.4 | 0.79 / 0.79 |
| ragged:6 M2000×K2112 COMPACT | 18.1 / 52.1 | 22.0 / 71.6 | 0.82 / **0.73** |
| size:9 int8 COMPACT（colwise 门槛 case） | 652.9 / **1885.5** | 668.8 / 1855.0 | 0.98 / 1.02 |

### 正确性

36 数值组（35 配对 + columnwise_only）+ 异常契约组 **6/6** 全部 PASS，全数值组 atol=0（INT8 逐位一致；FP8 与参考实现在 RNE 语义下逐位一致）。

## 性能实现要点

| 要点 | 做法 | 收益 |
| --- | --- | --- |
| 入口契约校验 | 入口参数/标志/连续性校验、optional 安全解引用、fp8 数值正确性 | 正确性闭环，全数值组 atol=0 |
| 编译器对齐 | JIT `prefer_hipcc: true`（dcc 工具链，与 origin 构建栈一致） | int8 COMPACT colwise -30%（size:9 3.35→2.52ms，追平 origin） |
| fp8 硬件转换 | 3 处量化点使用 `hcu_cvt_pk` 硬件 packed（2 指令/4 元素）+ uint32 单写 | fp8 线 event -23~-43%，全集 ≈0.94 |

## 后续优化方向

1. **半对齐 shape 向量化**（ragged:3 存量 1.17）：拆分 `full_tile` 单标志为 rowwise/columnwise 独立对齐判定（rowwise 需 `K%128 && M%64`，colwise 需 `K%64 && M%128`），恢复 M=2112 类 shape 的向量访存。
2. **双输出单遍融合**：rowwise+columnwise 合一 kernel，输入只读一次（纯带宽上限估算 fp32 ~1.67× / bf16 ~1.5×，仅双输出 case 受益）。
3. **ragged 反超机理验证**：fp8 ragged 组反超 15~27% 归因 packed 4B 写合并（假说），可用 xprof IL1/ST 指标或 ISA 复测定论。
4. **LDS bank conflict**：rowwise 列主读 padding（dcc 产物冲突率已从 2.55 降至 0.36，残差有限，优先级低）。

## 测试与复现

```bash
# 全量对拍（35 数值组 + columnwise_only + exc 异常契约 6 项）
HIP_VISIBLE_DEVICES=3 python op_tests/test_blockwise_scaled_cast_transpose.py

# 单 case
HIP_VISIBLE_DEVICES=3 python op_tests/test_blockwise_scaled_cast_transpose.py --case ragged:4

# 异常契约组
HIP_VISIBLE_DEVICES=3 python op_tests/test_blockwise_scaled_cast_transpose.py --case exc
```

首次调用触发 `module_blockwise_scaling` JIT 编译；性能计时前应先预热。修改 csrc 后必须 `AITER_REBUILD=1` 显式重编（JIT 无源码 mtime 比对）。
