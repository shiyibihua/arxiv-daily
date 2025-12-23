---
layout: default
title: MuBench: Assessment of Multilingual Capabilities of Large Language Models Across 61 Languages
---

# MuBench: Assessment of Multilingual Capabilities of Large Language Models Across 61 Languages

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.19468" class="toolbar-btn" target="_blank">📄 arXiv: 2506.19468v1</a>
  <a href="https://arxiv.org/pdf/2506.19468.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.19468v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.19468v1', 'MuBench: Assessment of Multilingual Capabilities of Large Language Models Across 61 Languages')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Wenhan Han, Yifan Zhang, Zhixun Chen, Binbin Liu, Haobin Lin, Bingni Zhang, Taifeng Wang, Mykola Pechenizkiy, Meng Fang, Yin Zheng

**分类**: cs.CL, cs.AI

**发布日期**: 2025-06-24

---

## 💡 一句话要点

**提出MuBench以评估多语言大模型的能力差异**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `多语言模型` `评估基准` `跨语言对齐` `性能分析` `自然语言处理` `机器翻译` `低资源语言`

## 📋 核心要点

1. 现有的多语言大模型评估方法存在数据集有限和缺乏跨语言对齐的问题，导致评估结果不全面。
2. 本文提出MuBench基准，涵盖61种语言，评估多种能力，并引入多语言一致性（MLC）作为性能分析的新指标。
3. 实验结果显示，现有多语言模型在声称的语言覆盖与实际表现之间存在显著差距，尤其是低资源语言表现不佳。

## 📝 摘要（中文）

多语言大模型（LLMs）正在快速发展，新的模型不断声称支持越来越多的语言。然而，现有评估数据集有限，缺乏跨语言对齐，导致多语言能力的评估在语言和技能覆盖上存在碎片化。为了解决这一问题，本文提出了MuBench，一个涵盖61种语言并评估广泛能力的基准。我们评估了几种最先进的多语言LLMs，发现声称的语言覆盖与实际表现之间存在显著差距，尤其是英语与低资源语言之间的持续性能差异。基于MuBench的对齐，我们提出了多语言一致性（MLC）作为分析性能瓶颈和指导模型改进的补充指标。最后，我们在英语和中文上预训练了一套12亿参数的模型，使用500B个标记，变化语言比例和并行数据比例，以研究跨语言迁移动态。

## 🔬 方法详解

**问题定义**：本文旨在解决现有多语言大模型评估方法中数据集不足和缺乏跨语言对齐的问题，导致评估结果的片面性和不准确性。

**核心思路**：通过引入MuBench基准，涵盖61种语言并评估多种能力，提供全面的多语言能力评估，并提出多语言一致性（MLC）作为补充指标，帮助分析模型性能瓶颈。

**技术框架**：MuBench基准包括多个模块，首先是数据集的构建，确保跨语言对齐；其次是能力评估，涵盖语言理解、生成等多种任务；最后是性能分析，利用MLC指标进行深入分析。

**关键创新**：MuBench的提出是本研究的核心创新，填补了现有评估方法的空白，特别是在低资源语言的评估上，提供了更为准确的性能分析工具。

**关键设计**：在模型预训练过程中，使用了12亿参数的模型，训练数据为500B个标记，设计了不同的语言比例和并行数据比例，以研究跨语言迁移的动态特性。具体的损失函数和网络结构细节在论文中进行了详细描述。

## 📊 实验亮点

实验结果表明，现有多语言模型在声称的语言覆盖与实际表现之间存在显著差距，尤其是在低资源语言上，性能差异可达30%。通过引入多语言一致性（MLC）指标，能够更好地识别模型的性能瓶颈，为后续改进提供指导。

## 🎯 应用场景

该研究的潜在应用领域包括多语言自然语言处理、机器翻译和跨文化信息检索等。通过提供全面的评估基准，MuBench可以帮助研究人员和开发者更好地理解和改进多语言模型的性能，推动多语言技术的实际应用和发展。

## 📄 摘要（原文）

> Multilingual large language models (LLMs) are advancing rapidly, with new models frequently claiming support for an increasing number of languages. However, existing evaluation datasets are limited and lack cross-lingual alignment, leaving assessments of multilingual capabilities fragmented in both language and skill coverage. To address this, we introduce MuBench, a benchmark covering 61 languages and evaluating a broad range of capabilities. We evaluate several state-of-the-art multilingual LLMs and find notable gaps between claimed and actual language coverage, particularly a persistent performance disparity between English and low-resource languages. Leveraging MuBench's alignment, we propose Multilingual Consistency (MLC) as a complementary metric to accuracy for analyzing performance bottlenecks and guiding model improvement. Finally, we pretrain a suite of 1.2B-parameter models on English and Chinese with 500B tokens, varying language ratios and parallel data proportions to investigate cross-lingual transfer dynamics.

