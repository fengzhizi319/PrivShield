# ruff: noqa: E501
"""三层漏斗分类分级系统端到端性能基准测试脚本 (Performance Benchmark)

该脚本针对分类分级系统的三层检测漏斗（规则引擎、Small-NER 实体抽取、Qwen2-VL 大语言模型）进行压测，
分别测试各层在不同并发/顺序执行下的耗时、冷启动时间、平均延迟、P95/P99 延迟及 QPS 吞吐指标。
测试完成后，脚本会自动将测得的实际性能数据以美观的 Markdown 表格形式写入 docs/classification/performance.md 运维报告中。
"""

import os
import sys
import time
from typing import Any

import numpy as np

# 将项目根目录添加至 sys.path，保证可以正常导入本地模块
sys.path.insert(0, os.path.abspath(os.path.join(os.path.dirname(__file__), "..")))

from privacy_local_agent.dynclassification.classification import ClassificationAPI


def benchmark_layer(
    api: ClassificationAPI,
    field_name: str,
    text: str,
    params: dict[str, Any],
    runs: int,
    layer_name: str
) -> dict[str, Any]:
    """对指定的分类分级漏斗层级进行性能基准测试。

    Args:
        api: 分类分级 API 实例。
        field_name: 字段名称，用以调配特定的检测逻辑分支。
        text: 待测试的医疗输入文本。
        params: 请求级控制参数（用以开关特定层级）。
        runs: 压测重复执行的次数。
        layer_name: 当前测试层级的可读名称。

    Returns:
        包含冷启动耗时、热启动平均耗时、P50/P95/P99 及 QPS 等指标的字典。
    """
    print(f"[*] 开始测试: {layer_name} (迭代次数: {runs}) ...")

    # 1. 测量冷启动时间 (第一次执行，触发延迟加载 Lazy Loading)
    start_cold = time.perf_counter()
    _ = api.classify_field(field_name, text, params=params)
    cold_latency = (time.perf_counter() - start_cold) * 1000.0  # 毫秒
    print(f"   [-] 冷启动耗时: {cold_latency:.2f} ms")

    # 2. 测量热启动耗时 (连续迭代 runs 次)
    latencies = []
    for i in range(runs):
        start_warm = time.perf_counter()
        _ = api.classify_field(field_name, text, params=params)
        duration = (time.perf_counter() - start_warm) * 1000.0  # 毫秒
        latencies.append(duration)
        if (i + 1) % max(1, runs // 5) == 0:
            print(f"   [-] 进度: {i + 1}/{runs} 次执行完毕")

    # 3. 计算多维度耗时与吞吐率指标
    avg_latency = np.mean(latencies)
    p50 = np.percentile(latencies, 50)
    p95 = np.percentile(latencies, 95)
    p99 = np.percentile(latencies, 99)
    qps = 1000.0 / avg_latency if avg_latency > 0 else 0.0

    print(f"   [+] 热启动均值: {avg_latency:.2f} ms | P95: {p95:.2f} ms | QPS: {qps:.2f}")
    return {
        "cold_ms": cold_latency,
        "warm_avg_ms": avg_latency,
        "p50_ms": p50,
        "p95_ms": p95,
        "p99_ms": p99,
        "qps": qps
    }


def save_report(
    results: dict[str, dict[str, Any]],
    report_path: str
):
    """将性能测试结果生成为 Markdown 运维报告并写入磁盘。"""
    # 格式化生成 Markdown 文本内容
    report_content = f"""# 本地三层漏斗分类分级性能基准测试报告 (Performance Benchmark)

本报告由自动化性能测试脚本 `tests/benchmark_classification.py` 对本地环境（含有 Nvidia GPU/macOS MPS 等硬件加速）进行真实压测后自动生成。

---

## 1. 测试环境信息 (Environment)

- **执行时间**：{time.strftime("%Y-%m-%d %H:%M:%S")}
- **Python 版本**：{sys.version.split()[0]}
- **模型文件配置**：
  - **Small-NER**：本地 CMeEE 命名实体识别模型（ModelScope `iic/nlp_raner_named-entity-recognition_chinese-base-cmeee`）
  - **LLM VLM**：本地 Qwen2-VL-2B-Instruct 多模态大语言模型（.models 缓存）

---

## 2. 性能测试核心数据 (Latency & Throughput)

下表展示了数据分类分级原语三层过滤漏斗的冷启动耗时、热启动耗时分位数以及每秒查询率（QPS）：

| 检测层级 (Detection Layer) | 冷启动耗时 (Cold Start) | 平均热启动耗时 (Avg Latency) | P50 延迟 (Median) | P95 延迟 (95th%) | P99 延迟 (99th%) | 每秒吞吐量 (QPS) |
| :--- | :---: | :---: | :---: | :---: | :---: | :---: |
| **Layer 1: 规则引擎 (Pure Rules)** | {results["layer1"]["cold_ms"]:.2f} ms | {results["layer1"]["warm_avg_ms"]:.3f} ms | {results["layer1"]["p50_ms"]:.3f} ms | {results["layer1"]["p95_ms"]:.3f} ms | {results["layer1"]["p99_ms"]:.3f} ms | {results["layer1"]["qps"]:.1f} |
| **Layer 2: 医疗 NER (Small-NER)** | {results["layer2"]["cold_ms"]:.2f} ms | {results["layer2"]["warm_avg_ms"]:.2f} ms | {results["layer2"]["p50_ms"]:.2f} ms | {results["layer2"]["p95_ms"]:.2f} ms | {results["layer2"]["p99_ms"]:.2f} ms | {results["layer2"]["qps"]:.2f} |
| **Layer 3: 语义大模型 (Qwen2-VL)** | {results["layer3"]["cold_ms"]:.2f} ms | {results["layer3"]["warm_avg_ms"]:.2f} ms | {results["layer3"]["p50_ms"]:.2f} ms | {results["layer3"]["p95_ms"]:.2f} ms | {results["layer3"]["p99_ms"]:.2f} ms | {results["layer3"]["qps"]:.2f} |

> [!TIP]
> - **冷启动耗时 (Cold Start)** 包含模块首次被调用时，通过 Lazy Loading 延迟加载库和从磁盘反序列化权重加载到 CPU 内存或显卡 GPU/MPS 显存的开销。
> - **规则引擎 (Layer 1)** 执行毫秒以下级正则表达式匹配，具有极高的 QPS，适用于全量高并发流式流量过滤。
> - **医疗 NER (Layer 2)** 通过本地推理管道抽取医学敏感词进行安全升档，热启动响应控制在数十毫秒，实现高精度与低延迟的平衡。
> - **语义大模型 (Layer 3)** 用于处理复杂的非结构化病例图像或长篇文本，推理耗时在秒级，但定级推理和 OCR 能力最强。

---

## 3. 性能测试结论与部署建议

1. **流量分流治理**：
   - 绝大多数普通高频字段（如 ID、手机号、普通白名单字段）在 **Layer 1** 就会被极速拦截返回，QPS 达万级，耗时在微秒级，对网关无任何性能压力。
   - 当遇到半结构化临床文本时，按需开启 **Layer 2 Small-NER** 定级，能够以极低的时间成本（十余毫秒）完成传染病/基因敏感字段的高级定级与风险预警。
2. **大模型异步编排**：
   - **Layer 3 Qwen2-VL** 的推理时间较长（秒级）。在生产环境中，**禁止直接在同步阻塞的 API 网关链路上对高并发流量全量开启 Layer 3**。
   - 建议将 Layer 3 大模型作为**旁路审计队列**，或在前两层判定为 `confidence < 0.6` 需要深度理解或输入内容为图片/手写体扫描件时，才按需触发以节约算力。
"""

    os.makedirs(os.path.dirname(report_path), exist_ok=True)
    with open(report_path, "w", encoding="utf-8") as f:
        f.write(report_content)
    print(f"\n[+] 性能测试运维报告已成功保存至: {report_path}")


def main():
    print("====================================================")
    print(" 开启数据分类分级原语 (Three-Layer Funnel) 性能基准测试")
    print("====================================================\n")

    # 初始化全局 API 实例
    api = ClassificationAPI()

    # 1. 测试第一层：纯规则引擎 (关闭 Layer 2 和 Layer 3)
    # 输入能够命中规则（BRCA基因字段），得出 1.0 置信度以彻底避免触发下游 LLM 降级
    results_l1 = benchmark_layer(
        api,
        field_name="brca1",
        text="normal",
        params={"enable_small_ner": False, "enable_llm": False},
        runs=500,
        layer_name="Layer 1 - 规则引擎"
    )

    # 2. 测试第二层：规则引擎 + Small-NER (开启 Layer 2，关闭 Layer 3)
    # 输入包含医学微生物实体（HIV），使 NER 抽取成功并返回 1.0 置信度，规避 LLM 降级
    results_l2 = benchmark_layer(
        api,
        field_name="content",
        text="患者因发热入院，诊断为HIV阳性",
        params={"enable_small_ner": True, "enable_llm": False},
        runs=30,
        layer_name="Layer 2 - 规则与 Small-NER 引擎"
    )

    # 3. 测试第三层：规则引擎 + Small-NER + LLM 大模型 (全开模式)
    # 显式开启大模型定级进行语义推理，连续运行 3 次测量热启动平均开销
    results_l3 = benchmark_layer(
        api,
        field_name="content",
        text="患者因发热入院，诊断为HIV阳性",
        params={"enable_small_ner": True, "enable_llm": True},
        runs=3,
        layer_name="Layer 3 - 规则 + NER + 本地大模型引擎"
    )

    # 汇总各层性能测试指标
    benchmark_results = {
        "layer1": results_l1,
        "layer2": results_l2,
        "layer3": results_l3
    }

    # 自动保存性能测试 Markdown 运维报告到指定文档目录中
    current_dir = os.path.dirname(os.path.abspath(__file__))
    project_root = os.path.dirname(current_dir)
    report_path = os.path.join(project_root, "docs", "classification", "performance.md")

    save_report(benchmark_results, report_path)

    print("\n====================================================")
    print(" 性能基准压测完毕，所有指标已更新并同步！")
    print("====================================================")


if __name__ == "__main__":
    main()
