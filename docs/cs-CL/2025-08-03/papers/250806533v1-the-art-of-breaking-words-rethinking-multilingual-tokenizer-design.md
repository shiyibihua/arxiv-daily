---
layout: default
title: The Art of Breaking Words: Rethinking Multilingual Tokenizer Design
---

# The Art of Breaking Words: Rethinking Multilingual Tokenizer Design

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2508.06533" class="toolbar-btn" target="_blank">📄 arXiv: 2508.06533v1</a>
  <a href="https://arxiv.org/pdf/2508.06533.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2508.06533v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2508.06533v1', 'The Art of Breaking Words: Rethinking Multilingual Tokenizer Design')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Aamod Thakur, Ajay Nagpal, Atharva Savarkar, Kundeshwar Pundalik, Siddhesh Dosi, Piyush Sawarkar, Viraj Thakur, Rohit Saluja, Maunendra Sankar Desarkar, Ganesh Ramakrishnan

**分类**: cs.CL, cs.AI

**发布日期**: 2025-08-03

---

## 💡 一句话要点

**提出一种新算法以优化多语言分词器设计**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `多语言处理` `分词器设计` `数据组成` `模型优化` `印地语脚本`

## 📋 核心要点

1. 现有的多语言分词器在词元与单词比率、上下文长度利用和推理速度方面存在显著不足。
2. 本文提出了一种新算法，通过优化数据组成和预分词策略来提高分词器的效率和模型性能。
3. 实验结果表明，所提分词器在平均词元与单词比率上较现有最先进的印地语模型提升超过40%，并加快了推理速度。

## 📝 摘要（中文）

尽管模型架构和训练目标已被广泛研究，但在多语言环境中的分词仍然是大型语言模型（LLM）开发中相对被忽视的方面。现有的分词器通常表现出高的词元与单词比率、低效的上下文长度利用和较慢的推理速度。本文系统研究了词汇大小、预分词规则和训练语料组成对词元与单词效率及模型质量的影响。我们在印地语脚本上进行了广泛实验，提出了一种新的数据组成算法，以平衡多语言数据用于分词器训练。我们的观察显著提高了模型性能，并将平均词元与单词比率减少约6%。

## 🔬 方法详解

**问题定义**：本文旨在解决多语言分词器在词元与单词比率高、上下文利用低和推理速度慢等问题。现有方法未能有效处理多语言环境中的复杂性，导致模型性能受限。

**核心思路**：论文提出了一种新的数据组成算法，旨在通过优化训练数据的多样性和预分词策略来提高分词器的效率。这种设计能够更好地适应多语言环境中的语言特性。

**技术框架**：整体架构包括数据组成、预分词规则和模型训练三个主要模块。首先，通过分析语料库的组成来优化数据，然后应用新的预分词策略，最后在改进的数据上训练模型。

**关键创新**：最重要的技术创新在于提出了一种新的数据组成算法，该算法在多语言数据平衡方面表现优异，与传统的随机化方法相比，显著降低了词元与单词比率。

**关键设计**：在参数设置上，论文对词汇大小和预分词规则进行了细致调整，采用了适应性损失函数以优化训练过程，确保模型在多语言环境中的有效性。具体的网络结构细节和训练策略也进行了优化，以适应印地语脚本的复杂性。

## 📊 实验亮点

实验结果显示，所提分词器在平均词元与单词比率上较现有最先进的印地语模型提升超过40%，并且在推理速度上也有显著改善。这一成果突显了分词器设计在多语言大型语言模型构建中的重要性。

## 🎯 应用场景

该研究的潜在应用领域包括多语言自然语言处理、机器翻译和跨语言信息检索等。通过优化分词器设计，能够显著提升多语言模型的性能和推理效率，从而推动相关技术在实际应用中的广泛采用，具有重要的实际价值和未来影响。

## 📄 摘要（原文）

> While model architecture and training objectives are well-studied, tokenization, particularly in multilingual contexts, remains a relatively neglected aspect of Large Language Model (LLM) development. Existing tokenizers often exhibit high token-to-word ratios, inefficient use of context length, and slower inference. We present a systematic study that links vocabulary size, pre-tokenization rules, and training-corpus composition to both token-to-word efficiency and model quality. To ground our analysis in a linguistically diverse context, we conduct extensive experiments on Indic scripts, which present unique challenges due to their high script diversity and orthographic complexity. Drawing on the insights from these analyses, we propose a novel algorithm for data composition that balances multilingual data for tokenizer training. Our observations on pretokenization strategies significantly improve model performance, and our data composition algorithm reduces the average token-to-word ratio by approximately 6% with respect to the conventional data randomization approach. Our tokenizer achieves more than 40% improvement on average token-to-word ratio against stateof-the-art multilingual Indic models. This improvement yields measurable gains in both model performance and inference speed. This highlights tokenization alongside architecture and training objectives as a critical lever for building efficient, scalable multilingual LLMs

