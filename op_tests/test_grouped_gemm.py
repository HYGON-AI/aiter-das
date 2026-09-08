# SPDX-License-Identifier: MIT
"""
aiter.ck_grouped_gemm 精度与性能测试。

语义
----
对每个 group i，内核计算  C[i] = A[i] @ B[i]^T。
  A[i] : [M_i, K_i]  行主序，输入 dtype
  B[i] : [N_i, K_i]  行主序，输入 dtype（CK 侧按列主序解释，等价于 B^T）
  C[i] : [M_i, N_i]  行主序，输出 dtype

输出 dtype
  fp16  -> fp16
  bf16  -> bf16
  fp8   -> float32（fp8 点积，float32 累加，无 scale）
  int8  -> int32  （int8 点积，int32  累加，无 scale）

fp8 / int8 说明
---------------
CK 执行原始硬件 MMAC，不做量化 scale。
下方参考实现为 a.float() @ b.float().T，与之对齐。
  - int8：int32 累加，结果应严格一致。
  - fp8：硬件先 fp8×fp8 再 float32 累加；参考实现先扩到 float32 再乘，
    存在数值差异，容差见 TOLERANCE。

dense / random fp8、int8 正确性仍待跟进：
  - int8 dense random：应精确；失败则可能是 CK instance bug。
  - fp8  dense random：允许小误差，rtol/atol ~ 0.2。

Layout 支持（--layout）
-----------------------
  NT（默认）：a=[M,K] 行主序，b=[N,K] 行主序（CK 按列主序读）-> C = A @ B^T
  NN：a=[M,K] 行主序，b=[K,N] 行主序 -> C = A @ B
  TN：a=[K,M] 行主序（CK 按列主序读为 A^T），b=[K,N] 行主序 -> C = A^T @ B
  仅 fp16/bf16 支持 NN/TN；C 始终为 [M,N] 行主序。
  Python 调用：aiter.ck_grouped_gemm(a, b, layout="NN")。

CI smoke 命令（小 shape，快速验正确性）
---------------------------------------
  python op_tests/test_grouped_gemm.py --smoke --dtype fp16
  python op_tests/test_grouped_gemm.py --smoke --dtype all --variable
  python op_tests/test_grouped_gemm.py --moe --dtype fp16

性能测试（默认 m=n=k=1024，约 6.4 GFLOPS/group）
-------------------------------------------------
  python op_tests/test_grouped_gemm.py --dtype fp16
  python op_tests/test_grouped_gemm.py --dtype all --variable --warmup 10 --repeat 100

说明：TFLOPS = sum(2*M*N*K) / time。shape 过小时 launch/sync 开销主导，数值会偏低；
torch_gemm 使用原生 dtype 的 matmul，torch_ref 仅用于精度校验（float32 慢路径）。
"""

import argparse
import time

import torch

import aiter


DTYPE_MAP = {
    "fp16": torch.float16,
    "bf16": torch.bfloat16,
    "fp8":  torch.float8_e4m3fn,
    "int8": torch.int8,
}

# 支持 fp8 硬件 MMAC 的架构。gfx936 等旧架构无 fp8 单元，运行结果全为 0，
# 因此 fp8 用例只在下列架构上执行，其余架构自动跳过。
FP8_SUPPORTED_ARCHS = ("gfx938", "gfx946", "gfx92a")


def _device_arch():
    """返回当前 CUDA/HIP 设备的架构名（如 'gfx936'），无法探测时返回空串。"""
    try:
        name = torch.cuda.get_device_properties(torch.cuda.current_device()).gcnArchName
    except Exception:
        return ""
    return name.split(":")[0]


def _fp8_supported():
    """当前设备架构是否支持 fp8 硬件 MMAC。"""
    arch = _device_arch()
    return any(arch.startswith(a) for a in FP8_SUPPORTED_ARCHS)


def _filter_dtypes(dtype_names):
    """在不支持 fp8 的架构上剔除 fp8 用例并打印跳过原因。"""
    if "fp8" in dtype_names and not _fp8_supported():
        arch = _device_arch() or "unknown"
        print(
            f"  [SKIP] fp8: current arch {arch} does not support fp8 "
            f"(requires {'/'.join(FP8_SUPPORTED_ARCHS)})"
        )
        dtype_names = [d for d in dtype_names if d != "fp8"]
    return dtype_names

# 各 dtype 的 assert_close 容差。
# fp8：硬件 fp8×fp8 MMAC 与 float32 参考可能舍入不同。
# int8：必须精确（int32 累加，无舍入）。
TOLERANCE = {
    torch.float16:       dict(rtol=5e-2, atol=5e-2),
    torch.bfloat16:      dict(rtol=5e-2, atol=5e-2),
    torch.float8_e4m3fn: dict(rtol=2e-1, atol=2e-1),
    torch.int8:          dict(rtol=0,    atol=0),
}

# 各 dtype 的 shape 对齐要求（CK tile 约束）。
# fp16/bf16 GemmConfigComputeV4 的 K_Tile=64；当前 CK instance 在 K=64（恰好一个 tile）会出错，
# 实际要求 K >= 128。
SHAPE_ALIGN = {
    torch.float16:       dict(m=64,  n=128, k=128),
    torch.bfloat16:      dict(m=64,  n=128, k=128),
    torch.float8_e4m3fn: dict(m=128, n=128, k=128),
    torch.int8:          dict(m=32,  n=32,  k=128),
}

# 各 dtype 预定义变长 shape（来自 Stage 1 验证）。
VARIABLE_SHAPES = {
    torch.float16:       [(128, 128, 128), (256, 128, 128), (384, 128, 128)],
    torch.bfloat16:      [(128, 128, 128), (256, 128, 128), (384, 128, 128)],
    torch.float8_e4m3fn: [(128, 128, 128), (256, 128, 256), (128, 256, 128)],
    torch.int8:          [(64,  64,  128), (128, 128, 256), (192, 64,  128)],
}

# 异构 shape：每组 M/N 不同（同 dtype 内 K 保持一致）。
# CK fp16/bf16 GemmConfigComputeV4 不支持组间 mixed K，因此只变 M/N。
HETERO_SHAPES = {
    torch.float16:       [(128, 128, 128), (192, 256, 128), (256, 128, 128)],
    torch.bfloat16:      [(128, 128, 128), (192, 256, 128), (256, 128, 128)],
    torch.float8_e4m3fn: [(128, 128, 128), (256, 128, 128), (128, 256, 128)],
    torch.int8:          [(32,  32,  128), (64,  64,  128), (96,  32,  128)],
}

# MOE：固定 N/K，每组 M 可不对齐（wrapper 自动 pad M 到 tile 边界）。
MOE_FIXED_NK = {
    torch.float16:       (128, 128),
    torch.bfloat16:      (128, 128),
    torch.float8_e4m3fn: (128, 128),
    torch.int8:          (32,  128),
}
MOE_M_VALUES = [1, 17, 33, 63, 65, 100]


# Layout（NT/NN/TN）测试 shape。参考 grouped_gemm_next_shapes_prompt.md 的
# Primus routed-expert 典型 shape（FC1/FC2 forward/backward），取其对齐子集：
#   N/K ∈ {2048, 4096, 7168}，M≈2048（典型 L_i）。
# 小 shape（128×128×128）用于 smoke 快速校验各 layout 正确性。
LAYOUT_SMOKE_SHAPES = [(128, 128, 128), (256, 256, 256), (128, 256, 128)]
LAYOUT_PERF_SHAPES = [
    (2048, 4096, 7168),  # FC1 forward:  M≈L_i, N=4096, K=7168
    (2048, 7168, 2048),  # FC2 forward:  M≈L_i, N=7168, K=2048
    (2048, 2048, 7168),  # FC2 gradA:    M≈L_i, N=2048, K=7168
]


# ── 张量构造 ──────────────────────────────────────────────────────────────────

def _rand_tensor(shape, dtype):
    """8-bit 用确定性 projection；fp16/bf16 用随机数。"""
    if dtype is torch.int8:
        values = (torch.arange(shape[1], device="cuda", dtype=torch.int16) % 5).to(torch.int8)
        return values.view(1, shape[1]).repeat(shape[0], 1).contiguous()
    if dtype is torch.float8_e4m3fn:
        values = (torch.arange(shape[1], device="cuda", dtype=torch.float16) % 5).to(dtype)
        return values.view(1, shape[1]).repeat(shape[0], 1).contiguous()
    src = (torch.randn(shape, device="cuda", dtype=torch.float16) / 10).contiguous()
    return src.to(dtype).contiguous()


def _make_b(shape, dtype):
    """
    构造 B 张量：8-bit 用 projection（仅首行非零），fp16/bf16 用随机数。
    保持与既有 projection 测试一致。
    """
    n, k = shape
    if dtype in (torch.int8, torch.float8_e4m3fn):
        b = torch.zeros(shape, device="cuda", dtype=dtype)
        if dtype is torch.int8:
            b[0, :] = 1
        else:
            b[0, :] = torch.ones(k, device="cuda", dtype=torch.float16).to(dtype)
        return b.contiguous()
    return _rand_tensor(shape, dtype)


def _make_b_layout(shape, dtype, b_layout):
    """
    按指定 layout 构造 B 的内存布局。

    Layout 编码（与 CK C ABI 的 a_layout / b_layout 一致）：
      'R' -> 行主序 -> [rows, cols] stride=(cols, 1)
      'C' -> 列主序 -> [rows, cols] stride=(1, rows)

    Python API 固定 a_layout='R', b_layout='C'，B 存 [N,K] 行主序。
    测其他 layout 时需传连续转置张量以匹配 shape 语义。
    """
    if b_layout == "C":
        # 常规：B 存 [N,K]，CK 按 [K,N] 列主序读，等价 B^T。
        return _make_b(shape, dtype)
    # b_layout == "R"：B 存 [N,K] 行主序；CK 按 [K,N] 行主序读，
    # 即 C = A @ B（非 A @ B^T）；参考实现需相应调整。
    n, k = shape
    return _make_b((n, k), dtype)


def _reference_rc(a, b):
    """RC layout 精度参考：C = A @ B^T（float32 累加，用于 assert_close）。"""
    return a.float() @ b.float().T


# ── Layout（NT/NN/TN）辅助 ────────────────────────────────────────────────────
#
# 三种 layout 均以 contiguous 行主序张量传入，CK 侧按 stride/layout 解释：
#   NT: a=[M,K], b=[N,K] -> C = A @ B^T   （aiter 默认，向后兼容）
#   NN: a=[M,K], b=[K,N] -> C = A @ B
#   TN: a=[K,M], b=[K,N] -> C = A^T @ B
# C 始终为 [M,N] 行主序。

LAYOUTS = ("NT", "NN", "TN")


def _make_ab_for_layout(m, n, k, dtype, layout):
    """按 layout 构造 (a, b) 物理张量。8-bit 不支持 NN/TN，这里只用于 fp16/bf16。"""
    if layout == "NT":
        a = _rand_tensor((m, k), dtype)
        b = _make_b((n, k), dtype)
    elif layout == "NN":
        a = _rand_tensor((m, k), dtype)
        b = _rand_tensor((k, n), dtype)
    elif layout == "TN":
        a = _rand_tensor((k, m), dtype)
        b = _rand_tensor((k, n), dtype)
    else:
        raise ValueError(f"unknown layout {layout}")
    return a, b


def _reference_layout(a, b, layout):
    """按 layout 计算 float32 参考输出 [M,N]。"""
    if layout == "NT":
        return a.float() @ b.float().T
    if layout == "NN":
        return a.float() @ b.float()
    if layout == "TN":
        return a.float().T @ b.float()
    raise ValueError(f"unknown layout {layout}")


def _torch_gemm_layout(a, b, layout):
    """按 layout 用原生 dtype matmul 计算（性能基准，仅 fp16/bf16）。"""
    if layout == "NT":
        return a @ b.T
    if layout == "NN":
        return a @ b
    if layout == "TN":
        return a.T @ b
    raise ValueError(f"unknown layout {layout}")


def _torch_gemm_grouped(a_tensors, b_tensors, dtype):
    """
    torch GEMM 性能基准：尽量用原生 dtype 的 matmul，避免 float() 转换开销。
    fp8/int8 无高效原生 matmul 时回退到 float32 参考。
    """
    if dtype in (torch.float16, torch.bfloat16):
        return [a @ b.T for a, b in zip(a_tensors, b_tensors)]
    return [_reference_rc(a, b) for a, b in zip(a_tensors, b_tensors)]


def _reference_rr(a, b):
    """RR layout 参考：C = A @ B（CK 视角下 B 为 [K,N]）。"""
    # b_layout='R' 时 B 存 [N,K] 行主序，CK 按 [K,N] 行主序解释。
    # 为简化，测试统一用 RC 约定。
    return a.float() @ b.float().T


# ── 断言 / 基准 / 算力 ────────────────────────────────────────────────────────

def _accuracy_stats(outputs, refs):
    """逐 group 统计 max_abs / max_rel（用于打印，不判定 pass/fail）。"""
    stats = []
    for out, ref in zip(outputs, refs):
        out_f = out.float()
        ref_f = ref.float()
        diff = (out_f - ref_f).abs()
        max_abs = diff.max().item()
        denom = ref_f.abs().clamp_min(1e-6)
        max_rel = (diff / denom).max().item()
        stats.append(dict(max_abs=max_abs, max_rel=max_rel))
    return stats


def _assert_close(dtype, outputs, refs):
    tol = TOLERANCE[dtype]
    for idx, (out, ref) in enumerate(zip(outputs, refs)):
        torch.testing.assert_close(
            out.float(),
            ref.float(),
            **tol,
            msg=lambda msg: f"group {idx} failed\n{msg}",
        )


def _format_accuracy_line(dtype_name, dtype, outputs, refs, shapes):
    """
    执行精度校验（失败则抛 AssertionError），并返回可打印的 PASS 行。
    """
    stats = _accuracy_stats(outputs, refs)
    _assert_close(dtype, outputs, refs)
    tol = TOLERANCE[dtype]
    shape_text = ",".join(f"{m}x{n}x{k}" for m, n, k in shapes)
    group_text = "  ".join(
        f"g{i}: max_abs={s['max_abs']:.2e} max_rel={s['max_rel']:.2e}"
        for i, s in enumerate(stats)
    )
    return (
        f"  [PASS] accuracy  dtype={dtype_name}  groups={len(shapes)}  shapes={shape_text}"
        f"  rtol={tol['rtol']} atol={tol['atol']}  {group_text}"
    )


def _bench(fn, warmup, repeat):
    for _ in range(warmup):
        fn()
    torch.cuda.synchronize()
    t0 = time.perf_counter()
    for _ in range(repeat):
        fn()
    torch.cuda.synchronize()
    return (time.perf_counter() - t0) * 1000.0 / repeat


def _total_gemm_flops(shapes):
    """
    计算 grouped GEMM 总 FLOPs（乘加各算 1 op，共 2*M*N*K）。
    shapes: [(M, N, K), ...]
    """
    return sum(2 * m * n * k for m, n, k in shapes)


def _ms_to_tflops(flops, ms):
    """将耗时（ms）与 FLOPs 换算为 TFLOPS。"""
    if ms <= 0:
        return 0.0
    return flops / (ms * 1e-3) / 1e12


def _output_dtype(dtype):
    if dtype is torch.int8:
        return torch.int32
    if dtype is torch.float8_e4m3fn:
        return torch.float32
    return dtype


def _make_c_tensors(shapes, dtype):
    out_dtype = _output_dtype(dtype)
    return [torch.empty((m, n), device="cuda", dtype=out_dtype) for m, n, _ in shapes]


def _speedup(torch_ms, ck_ms):
    """CK 相对 torch 的加速比（>1 表示 CK 更快）。"""
    if ck_ms <= 0:
        return 0.0
    return torch_ms / ck_ms


def _format_perf_line(dtype_name, shapes, ck_ms, torch_ms, ck_tag="ck"):
    """格式化延迟与 TFLOPS 输出（单行），附 CK vs torch 加速比。"""
    flops = _total_gemm_flops(shapes)
    gflops = flops / 1e9
    ck_tflops = _ms_to_tflops(flops, ck_ms)
    torch_tflops = _ms_to_tflops(flops, torch_ms)
    speedup = _speedup(torch_ms, ck_ms)
    shape_text = ",".join(f"{m}x{n}x{k}" for m, n, k in shapes)
    return (
        f"grouped_gemm  dtype={dtype_name}  groups={len(shapes)}  total={gflops:.3f} GFLOPS"
        f"  shapes={shape_text}"
        f"  {ck_tag}={ck_ms:.4f} ms ({ck_tflops:.3f} TFLOPS)"
        f"  torch_gemm={torch_ms:.4f} ms ({torch_tflops:.3f} TFLOPS)"
        f"  speedup(ck/torch)={speedup:.2f}x"
    )


# ── shape 工厂 ────────────────────────────────────────────────────────────────

def _make_shapes_uniform(args, dtype):
    return [(args.m, args.n, args.k)] * args.groups


def _make_shapes_variable(args, dtype):
    return VARIABLE_SHAPES[dtype][: args.groups]


def _make_shapes_heterogeneous(args, dtype):
    return HETERO_SHAPES[dtype][: args.groups]


def _make_shapes(args, dtype):
    if args.heterogeneous:
        return _make_shapes_heterogeneous(args, dtype)
    if args.variable:
        return _make_shapes_variable(args, dtype)
    return _make_shapes_uniform(args, dtype)


# ── 各 dtype 测试用例 ────────────────────────────────────────────────────────

def run_case(dtype_name, args):
    dtype = DTYPE_MAP[dtype_name]
    shapes = _make_shapes(args, dtype)

    a_tensors = [_rand_tensor((m, k), dtype) for m, _, k in shapes]
    b_tensors = [_make_b((n, k), dtype) for _, n, k in shapes]

    outputs = aiter.ck_grouped_gemm(a_tensors, b_tensors)
    refs = [_reference_rc(a, b) for a, b in zip(a_tensors, b_tensors)]
    print(_format_accuracy_line(dtype_name, dtype, outputs, refs, shapes))

    c_tensors = _make_c_tensors(shapes, dtype)
    outputs_pre = aiter.ck_grouped_gemm_out(a_tensors, b_tensors, c_tensors)
    print(_format_accuracy_line(dtype_name, dtype, outputs_pre, refs, shapes).replace(
        "[PASS]", "[PASS prealloc c]", 1))

    ck_ms = _bench(lambda: aiter.ck_grouped_gemm(a_tensors, b_tensors), args.warmup, args.repeat)
    ck_prealloc_ms = _bench(
        lambda: aiter.ck_grouped_gemm_out(a_tensors, b_tensors, c_tensors),
        args.warmup,
        args.repeat,
    )
    torch_ms = _bench(
        lambda: _torch_gemm_grouped(a_tensors, b_tensors, dtype),
        args.warmup,
        args.repeat,
    )

    print(_format_perf_line(dtype_name, shapes, ck_ms, torch_ms, ck_tag="ck"))
    print(_format_perf_line(dtype_name, shapes, ck_prealloc_ms, torch_ms, ck_tag="ck_prealloc"))


# ── layout（NT/NN/TN）变体测试 ────────────────────────────────────────────────

def _run_layout_group(dtype_name, dtype, shapes, layout, do_perf, args):
    """对给定 layout 构造一组 grouped GEMM，校验精度并（可选）测性能。"""
    a_tensors, b_tensors, refs = [], [], []
    for m, n, k in shapes:
        a, b = _make_ab_for_layout(m, n, k, dtype, layout)
        a_tensors.append(a)
        b_tensors.append(b)
        refs.append(_reference_layout(a, b, layout))

    outputs = aiter.ck_grouped_gemm(a_tensors, b_tensors, layout=layout)
    print(_format_accuracy_line(dtype_name, dtype, outputs, refs, shapes).replace(
        "[PASS]", f"[PASS {layout}]", 1))

    # prealloc C 路径
    c_tensors = _make_c_tensors(shapes, dtype)
    outputs_pre = aiter.ck_grouped_gemm_out(a_tensors, b_tensors, c_tensors, layout=layout)
    print(_format_accuracy_line(dtype_name, dtype, outputs_pre, refs, shapes).replace(
        "[PASS]", f"[PASS {layout} prealloc]", 1))

    if do_perf and args.warmup > 0 and args.repeat > 0:
        ck_ms = _bench(lambda: aiter.ck_grouped_gemm(a_tensors, b_tensors, layout=layout),
                       args.warmup, args.repeat)
        torch_ms = _bench(
            lambda: [_torch_gemm_layout(a, b, layout) for a, b in zip(a_tensors, b_tensors)],
            args.warmup, args.repeat)
        print(_format_perf_line(dtype_name, shapes, ck_ms, torch_ms, ck_tag=f"ck_{layout}"))


def run_layout_cases(args):
    """
    测试 NT/NN/TN 三种 layout 的 grouped GEMM 正确性（fp16/bf16），并对大 shape 测性能。

    Layout 约定（输入均为 contiguous 行主序）：
      - NT: a=[M,K], b=[N,K] -> C = A @ B^T   （默认，向后兼容）
      - NN: a=[M,K], b=[K,N] -> C = A @ B
      - TN: a=[K,M], b=[K,N] -> C = A^T @ B

    调用方式最简：aiter.ck_grouped_gemm(a, b, layout="NN")。
    """
    layouts = LAYOUTS if args.layout in ("all", None) else (args.layout,)
    if args.dtype == "all":
        dtype_names = ["fp16", "bf16"]
    elif args.dtype in ("fp16", "bf16"):
        dtype_names = [args.dtype]
    else:
        dtype_names = []
    if not dtype_names:
        print(f"  [SKIP] layout 测试仅支持 fp16/bf16，忽略 dtype={args.dtype}")
        return

    smoke = args.smoke
    print(f"\n=== Layout 测试（{'/'.join(layouts)}，fp16/bf16）"
          f"{' [smoke]' if smoke else ''} ===")
    for dtype_name in dtype_names:
        dtype = DTYPE_MAP[dtype_name]
        for layout in layouts:
            # 正确性：小 shape 全覆盖
            _run_layout_group(dtype_name, dtype, LAYOUT_SMOKE_SHAPES, layout,
                              do_perf=False, args=args)
            # 性能：大 shape（非 smoke 时）
            if not smoke:
                _run_layout_group(dtype_name, dtype, LAYOUT_PERF_SHAPES, layout,
                                  do_perf=True, args=args)


# ── 异构 shape 测试 ───────────────────────────────────────────────────────────

def run_heterogeneous_cases(args):
    """
    每组 M、N 不同（同 dtype 内 K 固定）。
    验证内核能正确处理逐组 shape 描述符。
    """
    print("\n=== 异构 shape 测试 ===")
    dtype_names = ["fp16", "bf16", "fp8", "int8"] if args.dtype == "all" else [args.dtype]
    dtype_names = _filter_dtypes(dtype_names)
    for dtype_name in dtype_names:
        dtype = DTYPE_MAP[dtype_name]
        shapes = HETERO_SHAPES[dtype]
        a_tensors = [_rand_tensor((m, k), dtype) for m, _, k in shapes]
        b_tensors = [_make_b((n, k), dtype) for _, n, k in shapes]
        outputs = aiter.ck_grouped_gemm(a_tensors, b_tensors)
        refs = [_reference_rc(a, b) for a, b in zip(a_tensors, b_tensors)]
        print(_format_accuracy_line(dtype_name, dtype, outputs, refs, shapes))


# ── MOE（动态 M，固定 N/K）测试 ───────────────────────────────────────────────
#
# MOE 语义：每组 C_i = A_i @ B_i^T，A_i: [M_i, K]，B_i: [N, K]（全组相同 N/K）。
# M_i 可为任意正整数，N/K 对齐要求：N % 128 == 0, K % 64 == 0, K >= 128。
#
# 实现路径（CK kernel 层 kPadM）：
#   1. ck_tile_hcu_grouped_gemm_run 检测 M_i 是否全部对齐 64
#   2. 对齐 → 走 GemmConfigComputeV4（kPadM=false，~40 TFLOPS 大 GEMM）
#   3. 不对齐 → 走 GemmConfigComputeV4Mpad（kPadM=true，M 维自动 pad 到 tile 边界）
#   4. kernel 内 pad_tensor_view 确保越界写入被抑制，epilogue 只写有效行
#   5. 无需 Python 侧 zero-pad A / slice C（Stage 5 的 ck_grouped_gemm_moe 保留作 fallback）

def run_moe_cases(args):
    """
    MOE 场景：每组 token 数 M_i 任意（不对齐），固定 N/K。
    直接调 ck_grouped_gemm / ck_grouped_gemm_out，CK kernel 层 kPadM 自动处理 M padding。
    """
    print("\n=== MOE 动态 M 测试（固定 N/K，kernel kPadM）===")
    # fp16/bf16 → V4Mpad (MPerBlock=64), fp8 → V5Mpad (MPerBlock=128)
    moe_dtypes = ["fp16", "bf16", "fp8"] if args.dtype == "all" else [args.dtype]
    moe_dtypes = _filter_dtypes(moe_dtypes)
    for dtype_name in moe_dtypes:
        if dtype_name not in ("fp16", "bf16", "fp8"):
            print(f"  [SKIP] {dtype_name}: MOE kPadM not supported")
            continue
        dtype = DTYPE_MAP[dtype_name]
        n, k = MOE_FIXED_NK[dtype]
        ms = MOE_M_VALUES[: args.groups] if args.groups <= len(MOE_M_VALUES) else MOE_M_VALUES
        shapes = [(m, n, k) for m in ms]

        # 构造不对齐 M 的 A 张量（M=1,17,33,63,65,100），全部 M % 64 != 0
        a_tensors = [_rand_tensor((m, k), dtype) for m, _, _ in shapes]
        b_tensors = [_make_b((n, k), dtype) for _ in shapes]

        # -- 路径 1: ck_grouped_gemm（alloc 输出） --
        # CK C ABI → ck_tile_hcu_grouped_gemm_run 检测 M 不对齐 → 自动走 V4Mpad
        # kernel 内 pad_tensor_view 将 M pad 到 ceil(M/64)*64，epilogue 只写有效行
        outputs = aiter.ck_grouped_gemm(a_tensors, b_tensors)
        refs = [_reference_rc(a, b) for a, b in zip(a_tensors, b_tensors)]
        print(_format_accuracy_line(dtype_name, dtype, outputs, refs, shapes).replace(
            "[PASS]", "[PASS moe alloc]", 1))

        # -- 路径 2: ck_grouped_gemm_out（prealloc 输出） --
        # 调用方预先分配 [M_i, N] 的 C tensor，kernel 直接写入逻辑尺寸
        c_tensors = [torch.empty((m, n), device="cuda", dtype=_output_dtype(dtype))
                     for m, _, _ in shapes]
        outputs_pre = aiter.ck_grouped_gemm_out(a_tensors, b_tensors, c_tensors)
        print(_format_accuracy_line(dtype_name, dtype, outputs_pre, refs, shapes).replace(
            "[PASS]", "[PASS moe prealloc]", 1))

        if args.warmup > 0 and args.repeat > 0:
            # 性能：kernel kPadM vs torch baseline
            ck_ms = _bench(lambda: aiter.ck_grouped_gemm(a_tensors, b_tensors),
                           args.warmup, args.repeat)
            ck_pre_ms = _bench(
                lambda: aiter.ck_grouped_gemm_out(a_tensors, b_tensors, c_tensors),
                args.warmup, args.repeat)
            torch_ms = _bench(lambda: _torch_gemm_grouped(a_tensors, b_tensors, dtype),
                              args.warmup, args.repeat)
            print(_format_perf_line(dtype_name, shapes, ck_ms, torch_ms, ck_tag="ck_moe"))
            print(_format_perf_line(dtype_name, shapes, ck_pre_ms, torch_ms, ck_tag="ck_moe_out"))


# ── CK vs torch 性能对比 ──────────────────────────────────────────────────────
#
# 未指定 --m/--n/--k 时，对一组方阵 shape（M=N=K，默认全对齐 tile 边界）
# 逐 dtype benchmark；显式指定任一维度时，仅测试指定的单个 shape。
# 打印 CK grouped_gemm 与 torch 原生 GEMM 的延迟、TFLOPS 及加速比对照表。

# 性能对比默认扫描的方阵尺寸。
PERF_SWEEP_SIZES = [[256,256,256], [512,512,512], [1024,1024,1024], [2048,2048,2048], [4096,7168,4096]]


def run_perf_compare(args):
    """
    CK grouped_gemm 与 torch GEMM 的性能对比。

    对每个 dtype、每个待测 shape 构造 args.groups 组同 shape 的 GEMM，
    分别 benchmark CK（alloc / prealloc）与 torch，输出对照表。
    """
def run_perf_compare(args):
    """
    CK grouped_gemm 与 torch GEMM 的性能对比。

    对每个 layout、每个 dtype、每个待测 shape 构造 args.groups 组同 shape 的 GEMM，
    分别 benchmark CK 与 torch，输出对照表。

    --layout 控制测试的 layout：
      未指定 → NT（默认，向后兼容）
      NT/NN/TN → 仅该 layout
      all → NT/NN/TN 三种都测（NN/TN 仅 fp16/bf16）
    """
    print("\n=== CK vs torch GEMM 性能对比 ===")

    if args.layout in (None, "NT"):
        layouts = ["NT"]
    elif args.layout == "all":
        layouts = list(LAYOUTS)
    else:
        layouts = [args.layout]

    if args.perf_shape_specified:
        shape_cases = [(args.m, args.n, args.k)]
    else:
        shape_cases = [(m, n, k) for m, n, k in PERF_SWEEP_SIZES]

    header = (
        f"{'layout':>6}  {'dtype':>6}  {'shape(MxNxK)':>18}  {'groups':>6}  "
        f"{'ck ms':>10}  {'ck TFLOPS':>10}  {'torch ms':>10}  "
        f"{'torch TFLOPS':>12}  {'speedup':>8}"
    )

    for layout in layouts:
        dtype_names = ["fp16", "bf16", "fp8", "int8"] if args.dtype == "all" else [args.dtype]
        dtype_names = _filter_dtypes(dtype_names)
        if layout != "NT":
            # NN/TN 仅 fp16/bf16
            dropped = [d for d in dtype_names if d not in ("fp16", "bf16")]
            if dropped:
                print(f"  [SKIP] layout={layout}: {'/'.join(dropped)} 仅 NT 支持")
            dtype_names = [d for d in dtype_names if d in ("fp16", "bf16")]

        for dtype_name in dtype_names:
            dtype = DTYPE_MAP[dtype_name]
            align = SHAPE_ALIGN[dtype]
            print(f"\n-- layout={layout}  dtype={dtype_name} --")
            print(header)
            print("-" * len(header))
            for raw_m, raw_n, raw_k in shape_cases:
                m = _align_up(raw_m, align["m"])
                n = _align_up(raw_n, align["n"])
                k = _align_up(raw_k, align["k"])
                shapes = [(m, n, k)] * args.groups

                a_tensors, b_tensors = [], []
                for _ in range(args.groups):
                    a, b = _make_ab_for_layout(m, n, k, dtype, layout)
                    a_tensors.append(a)
                    b_tensors.append(b)

                ck_ms = _bench(
                    lambda: aiter.ck_grouped_gemm(a_tensors, b_tensors, layout=layout),
                    args.warmup, args.repeat)
                torch_ms = _bench(
                    lambda: [_torch_gemm_layout(a, b, layout)
                             for a, b in zip(a_tensors, b_tensors)],
                    args.warmup, args.repeat)

                flops = _total_gemm_flops(shapes)
                ck_tflops = _ms_to_tflops(flops, ck_ms)
                torch_tflops = _ms_to_tflops(flops, torch_ms)
                speedup = _speedup(torch_ms, ck_ms)
                print(
                    f"{layout:>6}  {dtype_name:>6}  {f'{m}x{n}x{k}':>18}  {args.groups:>6}  "
                    f"{ck_ms:>10.4f}  {ck_tflops:>10.3f}  {torch_ms:>10.4f}  "
                    f"{torch_tflops:>12.3f}  {speedup:>7.2f}x"
                )


def _align_up(x, align):
    return ((x + align - 1) // align) * align


# ── 非法输入测试 ──────────────────────────────────────────────────────────────

def run_bad_input_cases():
    """
    验证 wrapper 对非法输入抛出合理错误。
    期望 RuntimeError / ValueError（来自 C++ TORCH_CHECK）。
    """
    print("\n=== 非法输入测试 ===")
    device = "cuda"
    dtype = torch.float16

    def _expect_error(desc, fn):
        try:
            fn()
            print(f"  [FAIL] {desc}: 期望报错但未抛出")
        except Exception as e:
            print(f"  [PASS] {desc}: {type(e).__name__}: {e}")

    _expect_error("空 a_tensors", lambda: aiter.ck_grouped_gemm([], []))

    _expect_error(
        "a/b 列表长度不一致",
        lambda: aiter.ck_grouped_gemm(
            [torch.zeros((128, 64), device=device, dtype=dtype)],
            [],
        ),
    )

    _expect_error(
        "非 2D 张量",
        lambda: aiter.ck_grouped_gemm(
            [torch.zeros((2, 128, 64), device=device, dtype=dtype)],
            [torch.zeros((128, 64), device=device, dtype=dtype)],
        ),
    )

    _expect_error(
        "K 维不匹配",
        lambda: aiter.ck_grouped_gemm(
            [torch.zeros((128, 64), device=device, dtype=dtype)],
            [torch.zeros((128, 128), device=device, dtype=dtype)],
        ),
    )

    # M 不对齐现在由 kernel kPadM 支持（V4Mpad），不应报错
    _expect_error(
        "shape 对齐违规（fp16 N 非 128 倍数）",
        lambda: aiter.ck_grouped_gemm(
            [torch.zeros((128, 128), device=device, dtype=dtype).contiguous()],
            [torch.zeros((127, 128), device=device, dtype=dtype).contiguous()],
        ),
    )


# ── main ──────────────────────────────────────────────────────────────────────
#
# 常用命令示例
# ────────────
# 对齐 M 测试（uniform 模式，M/N/K 均对齐 tile 边界，走 V4/V5 快速路径）
#   python op_tests/test_grouped_gemm.py --dtype fp16                          # 默认 1024³ x3, ~40 TFLOPS
#   python op_tests/test_grouped_gemm.py --dtype fp8                           # fp8 128³ 对齐
#   python op_tests/test_grouped_gemm.py --dtype all --variable                # 变长对齐 shape
#   python op_tests/test_grouped_gemm.py --heterogeneous --dtype fp16          # 异构 M/N，固定 K
#
# 任意 M 测试（MOE 模式，固定 N/K，M 任意值，kernel kPadM 自动处理不对齐）
#   python op_tests/test_grouped_gemm.py --moe --dtype fp16                    # M=1,17,33,63,65,100
#   python op_tests/test_grouped_gemm.py --moe --dtype fp8                     # M 不对齐 128 也可
#   python op_tests/test_grouped_gemm.py --moe --dtype fp16 --groups 3         # 只测前 3 个 M
#
# CI smoke（快速冒烟，小 shape）
#   python op_tests/test_grouped_gemm.py --smoke --dtype fp16
#   python op_tests/test_grouped_gemm.py --smoke --dtype all --variable
#
# 性能对比（CK vs torch GEMM，扫描方阵尺寸，输出对照表 + 加速比）
#   python op_tests/test_grouped_gemm.py --perf --dtype fp16                   # fp16 扫 256~4096
#   python op_tests/test_grouped_gemm.py --perf --dtype all                    # 所有 dtype
#   python op_tests/test_grouped_gemm.py --perf --dtype fp16 --m 2048 --n 2048 --k 2048  # 单一 shape
#   python op_tests/test_grouped_gemm.py --perf --dtype fp16 --m 4096 --n 7168 --k 4096  # 矩形 shape
#   python op_tests/test_grouped_gemm.py --perf --dtype fp16 --layout NN       # NN layout 性能对比
#   python op_tests/test_grouped_gemm.py --perf --dtype fp16 --layout all      # NT/NN/TN 三种对比
#
# 其他
#   python op_tests/test_grouped_gemm.py --layout                              # NT/NN/TN 全测
#   python op_tests/test_grouped_gemm.py --layout NN --dtype fp16              # 只测 NN
#   python op_tests/test_grouped_gemm.py --layout all --smoke                  # 快速正确性冒烟
#   python op_tests/test_grouped_gemm.py --bad-input                           # 错误输入测试

def main():
    parser = argparse.ArgumentParser(
        description="aiter.ck_grouped_gemm 精度与性能测试",
        formatter_class=argparse.RawDescriptionHelpFormatter,
    )
    parser.add_argument("--groups", type=int, default=3,
                        help="GEMM group 数量（uniform/variable 模式）")
    parser.add_argument("--m", type=int, default=None, help="M 维（uniform 模式，默认 1024）")
    parser.add_argument("--n", type=int, default=None, help="N 维（uniform 模式，默认 1024）")
    parser.add_argument("--k", type=int, default=None, help="K 维（uniform 模式，默认 1024）")
    parser.add_argument("--warmup", type=int, default=10, help="预热迭代次数")
    parser.add_argument("--repeat", type=int, default=100, help="基准测试迭代次数")
    parser.add_argument("--smoke", action="store_true",
                        help="CI smoke：groups=2, 128^3, warmup=1, repeat=5")
    parser.add_argument("--dtype", choices=["fp16", "bf16", "fp8", "int8", "all"], default="all",
                        help="测试的数据类型")
    parser.add_argument("--variable", action="store_true",
                        help="使用预定义变长 shape（见 VARIABLE_SHAPES）")
    parser.add_argument("--heterogeneous", action="store_true",
                        help="异构 shape：每组 M/N 不同（同 dtype 内 K 相同）")
    parser.add_argument("--moe", action="store_true",
                        help="MOE 模式：固定 N/K，M 任意（CK kernel kPadM 自动处理 M 对齐）")
    parser.add_argument("--layout", nargs="?", const="all", default=None,
                        choices=["NT", "NN", "TN", "all"],
                        help="layout 选择（NT/NN/TN/all，NN/TN 仅 fp16/bf16）；"
                             "单独使用时跑 layout 正确性/性能测试，"
                             "配合 --perf 时对该 layout 做性能对比；不带值时等于 all")
    parser.add_argument("--perf", action="store_true",
                        help="CK vs torch GEMM 性能对比（未指定 M/N/K 时扫描方阵尺寸）；"
                             "可加 --layout NN/TN/all 对比不同 layout")
    parser.add_argument("--bad-input", action="store_true",
                        help="运行非法输入错误处理测试")
    args = parser.parse_args()

    args.perf_shape_specified = any(value is not None for value in (args.m, args.n, args.k))
    args.m = 1024 if args.m is None else args.m
    args.n = 1024 if args.n is None else args.n
    args.k = 1024 if args.k is None else args.k

    if args.smoke:
        args.groups = 2
        args.m = args.n = args.k = 128
        args.warmup = 1
        args.repeat = 5
        args.perf_shape_specified = True

    if args.bad_input:
        run_bad_input_cases()
        return

    # --perf 优先于 --layout：允许 `--perf --layout NN/TN/all` 做 layout 性能对比。
    if args.perf:
        run_perf_compare(args)
        return

    if args.layout:
        run_layout_cases(args)
        return

    if args.heterogeneous:
        run_heterogeneous_cases(args)
        return

    if args.moe:
        run_moe_cases(args)
        return

    dtype_names = ["fp16", "bf16", "fp8", "int8"] if args.dtype == "all" else [args.dtype]
    dtype_names = _filter_dtypes(dtype_names)
    for dtype_name in dtype_names:
        run_case(dtype_name, args)


if __name__ == "__main__":
    main()
