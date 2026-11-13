# SPDX-License-Identifier: MIT
# Copyright (c) 2026 Hygon Information Technology Co., Ltd.
"""prefill/decode 索引 TopK 验证，K=2048；包含 indices-only 和 values 路径。

使用前：在指定容器中按同目录 README.md 配置 Torch/HIP、PMD 库路径和 clang18。
从仓库根目录设置测试脚本绝对路径，再在各自独立的结果目录执行下面的命令，
避免不同进程覆盖 m5out；GPU_CHIP 必须在 Python 启动前设置。
  test_py="$PWD/op_tests/gfx946_tests/moe_topk/test_topk_per_row.py"

已安装 wheel，或只复制本目录测试文件时，直接运行下面的数值命令；不要加 --rebuild。
--package-mode installed 使用当前 Python 环境的 AITER，build 集合仅验证模块加载。
在完整源码 checkout 中首次运行或源码变更后，重编译并加载对应模块：
  GPU_CHIP=sb python "$test_py" --package-mode source --suite build --rebuild --json build.json
单 die（1 XCD），运行全部数值用例和启动配置检查：
  GPU_CHIP=sb python "$test_py" --suite all --expect-xcds 1 --json single.json
多 die（一张 GPU、2 XCD），复用上一步构建的模块：
  GPU_CHIP=sbx2 python "$test_py" --suite all --expect-xcds 2 --json dual.json
显式多 die 分发，使用多个 workgroup 检查 chunk=2：
  GPU_CHIP=sbx2 python "$test_py" --suite route --expect-xcds 2 --die-mode linear --chunk 2 --json linear2.json

默认 quick 只跑少量用例；full 只做数值，all 额外做配置拒绝检查。
all 共7个数值用例。加 --ops prefill 或 --ops decode 可只测一个接口。
--list 列出用例且不初始化 GPU；--case prefill_indices 可只运行一个用例。
每例仅调用一次算子，无预热/计时；JSON 保存逐例结果、拓扑及源码/模块哈希。
--expect-xcds 核验实际拓扑；数值 PASS 之外还须用 completedWGs 确认跨 XCD 执行。
--die-mode off 仅表示普通启动 API，不等同单 die；本测试不验收 Graph 或性能。
"""
import _index_topk_common as common

PREFIX = "AITER_TOPK_PER_ROW"
TOPK = 2048
CASES = [
    dict(name="prefill_indices", op="prefill", rows=5, cols=2128, quick=True, route=True, config=True),
    dict(name="prefill_values", op="prefill", rows=5, cols=2128, values=True, route=True),
    dict(name="prefill_bins4096", op="prefill", rows=2, cols=8192),
    dict(name="decode_n1", op="decode", rows=5, cols=2112, next_n=1, route=True, config=True),
    dict(name="decode_n2", op="decode", rows=4, cols=2112, next_n=2, quick=True),
    dict(name="decode_n4", op="decode", rows=4, cols=2112, next_n=4),
    dict(name="decode_n3", op="decode", rows=3, cols=2112, next_n=3),
]
for _case in CASES:
    _case["prefix"] = PREFIX


def prepare(case):
    torch = common.torch
    from aiter.ops.topk_per_row import top_k_per_row_prefill, top_k_per_row_decode
    rows, cols = case["rows"], case["cols"]
    cpu = common.scores(rows, cols)
    x = cpu.cuda()
    ids, collect_ids = common.guarded((rows, TOPK), torch.int32)
    values, collect_values = common.guarded((rows, TOPK), torch.float32)
    starts = torch.zeros(rows, dtype=torch.int32)
    if case["op"] == "prefill":
        starts = torch.tensor([i % 4 for i in range(rows)], dtype=torch.int32)
        lengths = torch.tensor(([0, 31, TOPK, TOPK + 61, TOPK + 7] if rows == 5
                                else [cols - 8] * rows), dtype=torch.int32)
        ends = starts + lengths
        dstarts, dends = starts.cuda(), ends.cuda()

        def call():
            top_k_per_row_prefill(x, dstarts, dends, ids, rows, x.stride(0), x.stride(1),
                                 values if case.get("values") else None)
    else:
        next_n = case["next_n"]
        seq = torch.full((rows // next_n,), cols, dtype=torch.int32)
        if seq.numel() > 1:
            seq[0] = next_n + 15
        lengths = seq.repeat_interleave(next_n) - next_n + torch.arange(rows) % next_n + 1
        dseq = seq.cuda()

        def call():
            top_k_per_row_decode(x, next_n, dseq, ids, rows, x.stride(0), x.stride(1))

    def check():
        got = collect_ids()
        vals = collect_values()
        for row in range(rows):
            start, length = int(starts[row]), int(lengths[row])
            common.check_selected(cpu[row, start:start + length], got[row], TOPK,
                                  values=vals[row] if case.get("values") else None,
                                  identity_short=True)
            if case.get("values") and length < TOPK:
                assert (vals[row, length:] == 0).all(), "value padding mismatch"
        if not case.get("values"):
            assert (vals == -777).all(), "unused values buffer changed"
        assert torch.equal(x.cpu(), cpu)
        return dict(output_sha256=common.digest(got.sort(-1).values),
                    values_sha256=common.digest(vals) if case.get("values") else None)

    return call, check, dict(input_sha256=common.digest(cpu))


if __name__ == "__main__":
    common.main("module_topk_per_row", CASES, prepare, [PREFIX],
                ["csrc/kernels/topk_per_row.cu", "csrc/pybind/topk_per_row_pybind.cu",
                 "aiter/ops/topk_per_row.py"], __file__)
