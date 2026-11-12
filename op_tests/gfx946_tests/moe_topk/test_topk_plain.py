# SPDX-License-Identifier: MIT
# Copyright (c) 2026 Hygon Information Technology Co., Ltd.
"""topk_plain 的小规模 CPU 参考验证：Sort/共享 Radix、dtype、方向及值/索引配对。

使用前：在指定容器中按同目录 README.md 配置 Torch/HIP、PMD 库路径和 clang18。
从仓库根目录设置测试脚本绝对路径，再在各自独立的结果目录执行下面的命令，
避免不同进程覆盖 m5out；GPU_CHIP 必须在 Python 启动前设置。
  test_py="$PWD/op_tests/gfx946_tests/moe_topk/test_topk_plain.py"

首次运行或算子源码变更后，先重编译并加载对应模块（不发射 TopK kernel）：
  GPU_CHIP=sb python "$test_py" --suite build --rebuild --json build.json
单 die（1 XCD），运行全部数值用例和启动配置检查：
  GPU_CHIP=sb python "$test_py" --suite all --expect-xcds 1 --json single.json
多 die（一张 GPU、2 XCD），复用上一步构建的模块：
  GPU_CHIP=sbx2 python "$test_py" --suite all --expect-xcds 2 --json dual.json
显式多 die 分发，使用多个 workgroup 检查 chunk=2：
  GPU_CHIP=sbx2 python "$test_py" --suite route --expect-xcds 2 --die-mode linear --chunk 2 --json linear2.json

默认 quick 只跑少量用例；full 只做数值，all 额外做配置拒绝检查。
all 共8个数值用例；route 同时覆盖 Sort 和共享 Radix 两个启动策略。
--list 列出用例且不初始化 GPU；--case radix 可只运行一个用例。
每例仅调用一次算子，无预热/计时；JSON 保存逐例结果、拓扑及源码/模块哈希。
--expect-xcds 核验实际拓扑；数值 PASS 之外还须用 completedWGs 确认跨 XCD 执行。
--die-mode off 仅表示普通启动 API，不等同单 die；本测试不验收 Graph 或性能。
"""
import _index_topk_common as common

PLAIN = "AITER_TOPK_PLAIN"
RADIX = "AITER_TOPK_PER_ROW"
CASES = [
    dict(name="sort_fp32", op="topk_plain", rows=5, cols=512, k=64, dtype="fp32", largest=True, quick=True, route=True, config=True, prefix=PLAIN),
    dict(name="sort_fp16_min", op="topk_plain", rows=3, cols=512, k=64, dtype="fp16", largest=False, prefix=PLAIN),
    dict(name="sort_bf16_min", op="topk_plain", rows=5, cols=512, k=64, dtype="bf16", largest=False, quick=True, prefix=PLAIN),
    dict(name="sort_bf16_max", op="topk_plain", rows=3, cols=512, k=64, dtype="bf16", largest=True, prefix=PLAIN),
    dict(name="top1", op="topk_plain", rows=3, cols=128, k=1, dtype="fp32", largest=True, prefix=PLAIN),
    dict(name="ties", op="topk_plain", rows=3, cols=128, k=32, dtype="fp32", largest=True, ties=True, prefix=PLAIN),
    dict(name="radix", op="topk_plain", rows=5, cols=2112, k=2048, dtype="fp32", largest=True, route=True, config=True, prefix=RADIX),
    dict(name="radix_ranges", op="topk_plain", rows=3, cols=2112, k=2048, dtype="fp32", largest=True, variable=True, prefix=RADIX),
]


def prepare(case):
    torch = common.torch
    from aiter.ops.topk_plain import topk_plain
    dtype = {"fp32": torch.float32, "fp16": torch.float16, "bf16": torch.bfloat16}[case["dtype"]]
    rows, cols, k = case["rows"], case["cols"], case["k"]
    cpu = common.scores(rows, cols, dtype)
    if case.get("ties"):
        cpu = cpu.remainder(7)
    ids, collect_ids = common.guarded((rows, k), torch.int32)
    values, collect_values = common.guarded((rows, k), dtype)
    x = cpu.cuda()
    starts = torch.tensor([0, 7, 3], dtype=torch.int32) if case.get("variable") else torch.zeros(rows, dtype=torch.int32)
    lengths = torch.tensor([0, 31, 2100], dtype=torch.int32) if case.get("variable") else torch.full((rows,), cols, dtype=torch.int32)
    dstarts = starts.cuda() if case.get("variable") else torch.empty(0, dtype=torch.int32).cuda()
    dends = (starts + lengths).cuda() if case.get("variable") else torch.empty(0, dtype=torch.int32).cuda()

    def call():
        topk_plain(x, ids, values, k, case["largest"], dstarts, dends, x.stride(0), x.stride(1))

    def check():
        got, vals = collect_ids(), collect_values()
        for row in range(rows):
            start, length = int(starts[row]), int(lengths[row])
            common.check_selected(cpu[row, start:start + length], got[row], k,
                                  largest=case["largest"], values=vals[row])
        assert torch.equal(x.cpu(), cpu)
        return dict(output_sha256=common.digest(got.sort(-1).values),
                    values_sha256=common.digest(vals.sort(-1).values))

    return call, check, dict(input_sha256=common.digest(cpu))


if __name__ == "__main__":
    common.main("module_topk_plain", CASES, prepare, [PLAIN, RADIX],
                ["csrc/kernels/topk_plain_kernels.cu", "csrc/kernels/topk_per_row.cu",
                 "csrc/pybind/topk_plain_pybind.cu", "aiter/ops/topk_plain.py"], __file__)
