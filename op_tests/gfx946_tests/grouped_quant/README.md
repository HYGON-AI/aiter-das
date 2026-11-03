# 分组量化与 MXFP4 验证

从 AITER 根目录执行，依赖仅为标准库、Torch 和 AITER。输入在 CPU 确定性生成；量化字节、scale 字节或 FP32 值逐项精确比较。没有临时目录的 import、输入文件或定义依赖。

容器同时存在旧 wheel 时，先 `export PYTHONPATH="$PWD"` 明确选中当前 AITER 源码包；输出 ENV 的 `aiter` 路径和 SUMMARY 的模块路径/哈希用于核验。不要将历史临时 JIT 目录设为测试依赖。

```bash
python op_tests/gfx946_tests/grouped_quant/test_grouped_quant.py --suite full --dtype bf16
python op_tests/gfx946_tests/grouped_quant/test_grouped_quant.py --suite full --dtype fp16
python op_tests/gfx946_tests/grouped_quant/test_grouped_quant.py --suite config
```

覆盖 `per_group_quant_hip` 的 INT8、E4M3FN + FP32/E8M0 scale、group 32/64/128、转置 scale、3D wrapper、空输入、零组、有效行及 factor；覆盖 `per_1x32_f4_quant_hip` 的普通/shuffle scale、尾组、非紧凑行 stride。底层入口另检查输出和 scale 的保护区及未写入区域。FP4 的输入 N 必须为 32 的倍数，数据始终紧凑打包；shuffle 只改变 scale 布局，padding 值未定义。E8M0 的零组沿用 amax 最小值 `1e-10`。

Hygon FP8 数据只支持 `torch.float8_e4m3fn`。`torch.float8_e4m3fnuz` 可由 Torch 声明，但不能执行这两个算子；`--suite config` 覆盖公共包装层与直接 C++ 入口的 FNUZ 输出/scale 拒绝，必须在 kernel 发射前报错。E8M0 只表示 scale 格式。

在指定 PMD 容器中，先设置依赖路径和编译目标；模型选择必须在 Python/HIP 初始化前完成：

```bash
export GPU_ARCHS=gfx946 PMD_PATH=/opt/rocm/pmd
export LD_LIBRARY_PATH=/opt/rocm/lib:/opt/rocm/pmd:${LD_LIBRARY_PATH:-}
export GPU_DFLAGS="['StatLog']"
export GPU_CHIP=sb
python op_tests/gfx946_tests/grouped_quant/test_grouped_quant.py --suite boundaries --expect-xcds 1
export GPU_CHIP=sbx2
python op_tests/gfx946_tests/grouped_quant/test_grouped_quant.py --suite boundaries --expect-xcds 2
python op_tests/gfx946_tests/grouped_quant/test_grouped_quant.py --suite config --expect-xcds 2
```

可加 `--dtype fp16`。`--suite boundaries` 避免重复大 size；`--list` 给出统一性能矩阵，`--case fp8_m96` 仅执行一个 size。`--json result.json` 保存输入/输出哈希、实际包和模块路径/哈希；`--require-arch gfx946` 防止测错目标。

```bash
python op_tests/gfx946_tests/grouped_quant/test_grouped_quant.py --case fp4_m96 --die-mode linear --chunk 2 --expect-xcds 2
```

运行时初始化后测试会删除 `GPU_CHIP`，launcher 仍须通过 HIP 架构和 `numXcc` 工作。`off` 只表示普通 API，不能推断只用了一个 XCD。路由须通过 PMD 每个 dispatch 的 `completedWGs` 验证。

首次编译或源码更新后用 `AITER_REBUILD=1` 重建 `module_quant`，后续去掉。测试本身不指定 JIT 缓存路径。真实 gfx946 不需要 `GPU_CHIP`。未把 PMD 功能验证等同于真实 gfx946 或 Graph 验证。

真机可用 `--warmup 5 --repeat 20` 配合 hipprof 提取每次 kernel 时间；`--events` 是另一个包含包装层发射间隔的事件计时口径，不能混用。PMD 不做预热循环；GC 周期按 `cycles / 1500` 换算为 1.5GHz 下微秒。
