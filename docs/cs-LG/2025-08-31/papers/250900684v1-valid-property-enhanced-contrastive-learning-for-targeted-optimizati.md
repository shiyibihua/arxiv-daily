---
layout: default
title: Valid Property-Enhanced Contrastive Learning for Targeted Optimization & Resampling for Novel Drug Design
---

# Valid Property-Enhanced Contrastive Learning for Targeted Optimization & Resampling for Novel Drug Design

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.00684" class="toolbar-btn" target="_blank">📄 arXiv: 2509.00684v1</a>
  <a href="https://arxiv.org/pdf/2509.00684.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.00684v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.00684v1', 'Valid Property-Enhanced Contrastive Learning for Targeted Optimization & Resampling for Novel Drug Design')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Amartya Banerjee, Somnath Kar, Anirban Pal, Debabrata Maiti

**分类**: cs.LG, cs.AI

**发布日期**: 2025-08-31

**备注**: Code: https://github.com/amartya21/vector-drug-design.git

---

## 💡 一句话要点

**提出VECTOR+以解决低数据环境下药物设计问题**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)**

**关键词**: `药物设计` `生成模型` `对比学习` `化学空间` `低数据环境` `分子生成` `药理相关性` `新药发现`

## 📋 核心要点

1. 现有药物设计方法在低数据环境下难以有效探索药理相关的化学空间，限制了新药的发现。
2. VECTOR+框架通过结合属性引导的对比学习与分子生成，实现了可控的分子设计与优化。
3. 在PD-L1和激酶抑制剂数据集上，VECTOR+生成的分子在对接评分上超过了现有药物，显示出显著的性能提升。

## 📝 摘要（中文）

在药物发现过程中，有效引导生成模型朝向药理相关的化学空间仍然是一个主要挑战，尤其是在数据稀缺的情况下。本文提出了VECTOR+框架，结合了基于属性的表示学习与可控的分子生成，适用于回归和分类任务，能够实现对功能化学空间的可解释且数据高效的探索。在两个数据集上进行评估，VECTOR+生成了新颖且合成可行的候选分子，表现出优越的性能。实验结果表明，VECTOR+在药物设计中具有广泛的应用潜力。

## 🔬 方法详解

**问题定义**：本文旨在解决在低数据环境下药物设计中，如何有效引导生成模型探索药理相关的化学空间的问题。现有方法在数据稀缺时表现不佳，导致生成的候选分子质量低下。

**核心思路**：VECTOR+框架通过引入有效属性引导的对比学习，结合可控的分子生成，旨在提高生成分子的质量和相关性。这样的设计使得模型能够在有限的数据上进行有效的学习和优化。

**技术框架**：VECTOR+的整体架构包括属性引导的表示学习模块和分子生成模块。首先，通过对比学习获取分子的有效表示，然后利用这些表示进行分子的生成和优化。

**关键创新**：VECTOR+的主要创新在于将对比学习与生成模型相结合，形成了一种新的属性条件分子设计方法。这种方法在低数据环境下表现出色，显著提高了生成分子的药理相关性。

**关键设计**：在模型设计中，VECTOR+采用了特定的损失函数以强化属性引导的学习，同时在网络结构上进行了优化，以确保生成分子的合成可行性和药理活性。

## 📊 实验亮点

在PD-L1抑制剂的实验中，VECTOR+生成的8,374个分子中，有100个分子的对接评分超过了-15.0 kcal/mol，最佳分子评分为-17.6 kcal/mol，优于参考抑制剂的-15.4 kcal/mol。此外，VECTOR+在激酶抑制剂的生成中也表现出色，生成的分子对接评分超过了现有药物如brigatinib和sorafenib。

## 🎯 应用场景

该研究的潜在应用领域包括新药发现、化学合成和生物医药等。通过提高药物设计的效率和准确性，VECTOR+有望加速新药的研发进程，降低研发成本，并推动个性化医疗的发展。

## 📄 摘要（原文）

> Efficiently steering generative models toward pharmacologically relevant regions of chemical space remains a major obstacle in molecular drug discovery under low-data regimes. We present VECTOR+: Valid-property-Enhanced Contrastive Learning for Targeted Optimization and Resampling, a framework that couples property-guided representation learning with controllable molecule generation. VECTOR+ applies to both regression and classification tasks and enables interpretable, data-efficient exploration of functional chemical space. We evaluate on two datasets: a curated PD-L1 inhibitor set (296 compounds with experimental $IC_{50}$ values) and a receptor kinase inhibitor set (2,056 molecules by binding mode). Despite limited training data, VECTOR+ generates novel, synthetically tractable candidates. Against PD-L1 (PDB 5J89), 100 of 8,374 generated molecules surpass a docking threshold of $-15.0$ kcal/mol, with the best scoring $-17.6$ kcal/mol compared to the top reference inhibitor ($-15.4$ kcal/mol). The best-performing molecules retain the conserved biphenyl pharmacophore while introducing novel motifs. Molecular dynamics (250 ns) confirm binding stability (ligand RMSD < $2.5$ angstroms). VECTOR+ generalizes to kinase inhibitors, producing compounds with stronger docking scores than established drugs such as brigatinib and sorafenib. Benchmarking against JT-VAE and MolGPT across docking, novelty, uniqueness, and Tanimoto similarity highlights the superior performance of our method. These results position our work as a robust, extensible approach for property-conditioned molecular design in low-data settings, bridging contrastive learning and generative modeling for reproducible, AI-accelerated discovery.

