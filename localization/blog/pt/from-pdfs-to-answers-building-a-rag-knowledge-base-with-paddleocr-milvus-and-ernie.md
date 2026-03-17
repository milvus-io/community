---
id: >-
  from-pdfs-to-answers-building-a-rag-knowledge-base-with-paddleocr-milvus-and-ernie.md
title: >-
  De PDFs a respostas: Construindo uma base de conhecimento RAG com PaddleOCR,
  Milvus e ERNIE
author: LiaoYF and Jing Zhang
date: 2026-3-17
cover: assets.zilliz.com/cover_747a1385ed.jpg
tag: Engineering
recommend: false
publishToMedium: true
tags: 'Milvus, vector database'
meta_keywords: 'RAG, Milvus, vector database, hybrid search, knowledge base Q&A'
meta_title: |
  Build a RAG Knowledge Base with PaddleOCR, Milvus, and ERNIE
desc: >-
  Saiba como criar uma base de conhecimentos RAG de elevada precisão utilizando
  Milvus, pesquisa híbrida, reranking e P&amp;R multimodais para inteligência
  documental.
origin: >-
  https://milvus.io/blog/from-pdfs-to-answers-building-a-rag-knowledge-base-with-paddleocr-milvus-and-ernie.md
---
<p>Os modelos linguísticos de grande dimensão são muito mais capazes do que eram em 2023, mas continuam a alucinar com a confiança e recorrem frequentemente a informações desactualizadas. O RAG (Retrieval-Augmented Generation) resolve ambos os problemas recuperando o contexto relevante de uma base de dados vetorial como a <a href="https://milvus.io/">Milvus</a> antes de o modelo gerar uma resposta. Esse contexto adicional fundamenta a resposta em fontes reais e torna-a mais atual.</p>
<p>Um dos casos de utilização mais comuns do RAG é uma base de conhecimentos de uma empresa. Um utilizador carrega PDFs, ficheiros Word ou outros documentos internos, faz uma pergunta em linguagem natural e recebe uma resposta baseada nesses materiais e não apenas na pré-treino do modelo.</p>
<p>Mas utilizar o mesmo LLM e a mesma base de dados vetorial não garante o mesmo resultado. Duas equipas podem construir sobre a mesma base e acabar com uma qualidade de sistema muito diferente. A diferença geralmente vem de tudo o que está a montante: <strong>como os documentos são analisados, divididos em pedaços e incorporados; como os dados são indexados; como os resultados da recuperação são classificados; e como a resposta final é montada.</strong></p>
<p>Neste artigo, usaremos <a href="https://github.com/LiaoYFBH/Paddle-ERNIE-RAG/blob/main/README_EN.md">o Paddle-ERNIE-RAG</a> como exemplo e explicaremos como construir uma base de conhecimento baseada em RAG com <a href="https://github.com/PADDLEPADDLE/PADDLEOCR">PaddleOCR</a>, <a href="https://milvus.io/">Milvus</a> e ERNIE-4.5-Turbo.</p>
<h2 id="Paddle-ERNIE-RAG-System-Architecture" class="common-anchor-header">Arquitetura do sistema Paddle-ERNIE-RAG<button data-href="#Paddle-ERNIE-RAG-System-Architecture" class="anchor-icon" translate="no">
      <svg translate="no"
        aria-hidden="true"
        focusable="false"
        height="20"
        version="1.1"
        viewBox="0 0 16 16"
        width="16"
      >
        <path
          fill="#0092E4"
          fill-rule="evenodd"
          d="M4 9h1v1H4c-1.5 0-3-1.69-3-3.5S2.55 3 4 3h4c1.45 0 3 1.69 3 3.5 0 1.41-.91 2.72-2 3.25V8.59c.58-.45 1-1.27 1-2.09C10 5.22 8.98 4 8 4H4c-.98 0-2 1.22-2 2.5S3 9 4 9zm9-3h-1v1h1c1 0 2 1.22 2 2.5S13.98 12 13 12H9c-.98 0-2-1.22-2-2.5 0-.83.42-1.64 1-2.09V6.25c-1.09.53-2 1.84-2 3.25C6 11.31 7.55 13 9 13h4c1.45 0 3-1.69 3-3.5S14.5 6 13 6z"
        ></path>
      </svg>
    </button></h2><p>A arquitetura do Paddle-ERNIE-RAG consiste em quatro camadas principais:</p>
<ul>
<li><strong>Camada de extração de dados.</strong> <a href="https://github.com/PaddlePaddle/PaddleOCR">PP-StructureV3</a>, o pipeline de análise de documentos no PaddleOCR, lê PDFs e imagens com OCR sensível ao layout. Preserva a estrutura do documento - cabeçalhos, tabelas, ordem de leitura - e produz Markdown limpo, dividido em partes sobrepostas.</li>
<li><strong>Camada de armazenamento vetorial.</strong> Cada fragmento é incorporado num vetor de 384 dimensões e armazenado em <a href="https://milvus.io"></a><a href="https://milvus.io">Milvus</a> juntamente com metadados (nome do ficheiro, número de página, ID do fragmento). Um índice invertido paralelo suporta a pesquisa por palavra-chave.</li>
<li><strong>Camada de recuperação e resposta.</strong> Cada consulta é executada tanto no índice vetorial como no índice de palavras-chave. Os resultados são fundidos através de RRF (Reciprocal Rank Fusion), reavaliados e passados para o modelo <a href="https://github.com/LiaoYFBH/Paddle-ERNIE-RAG">ERNIE</a> para geração de respostas.</li>
<li><strong>Camada de aplicação.</strong> Uma interface<a href="https://www.gradio.app/">Gradio</a> <a href="https://www.gradio.app/"></a><a href="https://www.gradio.app/"></a> permite-lhe carregar documentos, fazer perguntas e ver respostas com citações de fontes e pontuações de confiança.  <span class="img-wrapper">
    <img translate="no" src="blob:https://septemberfd.github.io/9043a059-de46-49b1-9399-f915aed555dc" alt="" class="doc-image" id="" />
    <span></span>
  </span>
</li>
</ul>
<p>As secções abaixo percorrem cada fase por ordem, começando pela forma como os documentos em bruto se transformam em texto pesquisável.</p>
<h2 id="How-to-Build-RAG-Pipeline-Step-by-Step" class="common-anchor-header">Como construir o pipeline RAG passo a passo<button data-href="#How-to-Build-RAG-Pipeline-Step-by-Step" class="anchor-icon" translate="no">
      <svg translate="no"
        aria-hidden="true"
        focusable="false"
        height="20"
        version="1.1"
        viewBox="0 0 16 16"
        width="16"
      >
        <path
          fill="#0092E4"
          fill-rule="evenodd"
          d="M4 9h1v1H4c-1.5 0-3-1.69-3-3.5S2.55 3 4 3h4c1.45 0 3 1.69 3 3.5 0 1.41-.91 2.72-2 3.25V8.59c.58-.45 1-1.27 1-2.09C10 5.22 8.98 4 8 4H4c-.98 0-2 1.22-2 2.5S3 9 4 9zm9-3h-1v1h1c1 0 2 1.22 2 2.5S13.98 12 13 12H9c-.98 0-2-1.22-2-2.5 0-.83.42-1.64 1-2.09V6.25c-1.09.53-2 1.84-2 3.25C6 11.31 7.55 13 9 13h4c1.45 0 3-1.69 3-3.5S14.5 6 13 6z"
        ></path>
      </svg>
    </button></h2><h3 id="Step-1-Parse-Documents-with-PP-StructureV3" class="common-anchor-header">Etapa 1: Analisar documentos com PP-StructureV3</h3><p>Os documentos em bruto são onde começa a maioria dos problemas de precisão. Artigos de pesquisa e relatórios técnicos misturam layouts de duas colunas, fórmulas, tabelas e imagens. A extração de texto com uma biblioteca básica como o PyPDF2 normalmente distorce o resultado: os parágrafos aparecem fora de ordem, as tabelas colapsam e as fórmulas desaparecem.</p>
<p>Para evitar estes problemas, o projeto cria uma classe OnlinePDFParser em backend.py. Esta classe chama a API online do PP-StructureV3 para fazer a análise do layout. Em vez de extrair texto em bruto, identifica a estrutura do documento e transforma-o em formato Markdown.</p>
<p>Este método tem três benefícios claros:</p>
<ul>
<li><strong>Saída Markdown limpa</strong></li>
</ul>
<p>A saída é formatada como Markdown com cabeçalhos e parágrafos adequados. Isto torna o conteúdo mais fácil de compreender para o modelo.</p>
<ul>
<li><strong>Extração de imagens separada</strong></li>
</ul>
<p>O sistema extrai e guarda imagens durante a análise. Isto evita a perda de informações visuais importantes.</p>
<ul>
<li><strong>Melhor tratamento do contexto</strong></li>
</ul>
<p>O texto é dividido utilizando uma janela deslizante com sobreposição. Isto evita cortar frases ou fórmulas no meio, o que ajuda a manter o significado claro e melhora a precisão da pesquisa.</p>
<p><strong>Fluxo básico de análise</strong></p>
<p>Em backend.py, a análise segue três passos simples:</p>
<ol>
<li>Enviar o ficheiro PDF para a API PP-StructureV3.</li>
<li>Ler o layoutParsingResults retornado.</li>
<li>Extrair o texto Markdown limpo e quaisquer imagens.</li>
</ol>
<pre><code translate="no"><span class="hljs-comment"># backend.py (Core logic summary of the OnlinePDFParser class)</span>
<span class="hljs-keyword">def</span> <span class="hljs-title function_">predict</span>(<span class="hljs-params">self, file_path</span>):
    <span class="hljs-comment"># 1. Convert file to Base64</span>
    <span class="hljs-keyword">with</span> <span class="hljs-built_in">open</span>(file_path, <span class="hljs-string">&quot;rb&quot;</span>) <span class="hljs-keyword">as</span> file:
        file_data = base64.b64encode(file.read()).decode(<span class="hljs-string">&quot;ascii&quot;</span>)
    <span class="hljs-comment"># 2. Build request payload</span>
    payload = {
        <span class="hljs-string">&quot;file&quot;</span>: file_data,
        <span class="hljs-string">&quot;fileType&quot;</span>: <span class="hljs-number">1</span>, <span class="hljs-comment"># PDF type</span>
        <span class="hljs-string">&quot;useChartRecognition&quot;</span>: <span class="hljs-literal">False</span>, <span class="hljs-comment"># Configure based on requirements</span>
        <span class="hljs-string">&quot;useDocOrientationClassify&quot;</span>: <span class="hljs-literal">False</span>
    }
    <span class="hljs-comment"># 3. Send request to get Layout Parsing results</span>
    response = requests.post(<span class="hljs-variable language_">self</span>.api_url, json=payload, headers=headers)
    res_json = response.json()
    <span class="hljs-comment"># 4. Extract Markdown text and images</span>
    parsing_results = res_json.get(<span class="hljs-string">&quot;result&quot;</span>, {}).get(<span class="hljs-string">&quot;layoutParsingResults&quot;</span>, [])
    mock_outputs = []
    <span class="hljs-keyword">for</span> item <span class="hljs-keyword">in</span> parsing_results:
        md_text = item.get(<span class="hljs-string">&quot;markdown&quot;</span>, {}).get(<span class="hljs-string">&quot;text&quot;</span>, <span class="hljs-string">&quot;&quot;</span>)
        images = item.get(<span class="hljs-string">&quot;markdown&quot;</span>, {}).get(<span class="hljs-string">&quot;images&quot;</span>, {})
        <span class="hljs-comment"># ... (subsequent image downloading and text cleaning logic)</span>
        mock_outputs.append(MockResult(md_text, images))
    <span class="hljs-keyword">return</span> mock_outputs, <span class="hljs-string">&quot;Success&quot;</span>
<button class="copy-code-btn"></button></code></pre>
<h3 id="Step-2-Chunk-Text-with-Sliding-Window-Overlap" class="common-anchor-header">Passo 2: Texto em pedaços com sobreposição de janela deslizante</h3><p>Após a análise, o texto Markdown deve ser dividido em pedaços menores (chunks) para pesquisa. Se o texto for cortado em comprimentos fixos, as frases ou fórmulas podem ser divididas ao meio.</p>
<p>Para evitar que isso aconteça, o sistema usa chunking de janela deslizante com sobreposição. Cada bloco partilha uma parte da cauda com o seguinte, pelo que o conteúdo do limite aparece em ambas as janelas. Isto mantém o significado intacto nos limites dos pedaços e melhora a recuperação.</p>
<pre><code translate="no"><span class="hljs-comment"># backend.py</span>
<span class="hljs-keyword">def</span> <span class="hljs-title function_">split_text_into_chunks</span>(<span class="hljs-params">text: <span class="hljs-built_in">str</span>, chunk_size: <span class="hljs-built_in">int</span> = <span class="hljs-number">300</span>, overlap: <span class="hljs-built_in">int</span> = <span class="hljs-number">120</span></span>) -&gt; <span class="hljs-built_in">list</span>:
    <span class="hljs-string">&quot;&quot;&quot;Sliding window-based text chunking that preserves overlap-length contextual overlap&quot;&quot;&quot;</span>
    <span class="hljs-keyword">if</span> <span class="hljs-keyword">not</span> text: <span class="hljs-keyword">return</span> []
    lines = [line.strip() <span class="hljs-keyword">for</span> line <span class="hljs-keyword">in</span> text.split(<span class="hljs-string">&quot;\n&quot;</span>) <span class="hljs-keyword">if</span> line.strip()]
    chunks = []
    current_chunk = []
    current_length = <span class="hljs-number">0</span>
    <span class="hljs-keyword">for</span> line <span class="hljs-keyword">in</span> lines:
        <span class="hljs-keyword">while</span> <span class="hljs-built_in">len</span>(line) &gt; chunk_size:
            <span class="hljs-comment"># Handle overly long single line</span>
            part = line[:chunk_size]
            line = line[chunk_size:]
            current_chunk.append(part)
            <span class="hljs-comment"># ... (chunking logic) ...</span>
        current_chunk.append(line)
        current_length += <span class="hljs-built_in">len</span>(line)
        <span class="hljs-comment"># When accumulated length exceeds the threshold, generate a chunk</span>
        <span class="hljs-keyword">if</span> current_length &gt; chunk_size:
            chunks.append(<span class="hljs-string">&quot;\n&quot;</span>.join(current_chunk))
            <span class="hljs-comment"># Roll back: keep the last overlap-length text as the start of the next chunk</span>
            overlap_text = current_chunk[-<span class="hljs-number">1</span>][-overlap:] <span class="hljs-keyword">if</span> current_chunk <span class="hljs-keyword">else</span> <span class="hljs-string">&quot;&quot;</span>
            current_chunk = [overlap_text] <span class="hljs-keyword">if</span> overlap_text <span class="hljs-keyword">else</span> []
            current_length = <span class="hljs-built_in">len</span>(overlap_text)
    <span class="hljs-keyword">if</span> current_chunk:
        chunks.append(<span class="hljs-string">&quot;\n&quot;</span>.join(current_chunk).strip())
    <span class="hljs-keyword">return</span> chunks
<button class="copy-code-btn"></button></code></pre>
<h3 id="Step-3-Store-Vectors-and-Metadata-in-Milvus" class="common-anchor-header">Passo 3: Armazenar vectores e metadados no Milvus</h3><p>Com os pedaços limpos prontos, o próximo passo é armazená-los de uma forma que permita uma recuperação rápida e precisa.</p>
<p><strong>Armazenamento de vectores e metadados</strong></p>
<p>O Milvus impõe regras rígidas para nomes de coleções - apenas letras ASCII, números e sublinhados. Se o nome de uma base de conhecimentos contiver caracteres não-ASCII, o backend codifica-o em hexadecimal com um prefixo kb_ antes de criar a coleção e descodifica-o para apresentação. Um pequeno pormenor, mas que evita erros crípticos.</p>
<pre><code translate="no"><span class="hljs-keyword">import</span> binascii
<span class="hljs-keyword">import</span> re

<span class="hljs-keyword">def</span> <span class="hljs-title function_">encode_name</span>(<span class="hljs-params">ui_name</span>):
    <span class="hljs-string">&quot;&quot;&quot;Convert a foreign name into a Milvus-valid hexadecimal string&quot;&quot;&quot;</span>
    <span class="hljs-keyword">if</span> <span class="hljs-keyword">not</span> ui_name: <span class="hljs-keyword">return</span> <span class="hljs-string">&quot;&quot;</span>
    <span class="hljs-comment"># If it only contains English letters, numbers, or underscores, return it directly</span>
    <span class="hljs-keyword">if</span> re.<span class="hljs-keyword">match</span>(<span class="hljs-string">r&#x27;^[a-zA-Z_][a-zA-Z0-9_]*$&#x27;</span>, ui_name):
        <span class="hljs-keyword">return</span> ui_name
    <span class="hljs-comment"># Encode to Hex and add the kb_ prefix</span>
    hex_str = binascii.hexlify(ui_name.encode(<span class="hljs-string">&#x27;utf-8&#x27;</span>)).decode(<span class="hljs-string">&#x27;utf-8&#x27;</span>)
    <span class="hljs-keyword">return</span> <span class="hljs-string">f&quot;kb_<span class="hljs-subst">{hex_str}</span>&quot;</span>
<span class="hljs-keyword">def</span> <span class="hljs-title function_">decode_name</span>(<span class="hljs-params">real_name</span>):
    <span class="hljs-string">&quot;&quot;&quot;Convert a hexadecimal string back to original language&quot;&quot;&quot;</span>
    <span class="hljs-keyword">if</span> real_name.startswith(<span class="hljs-string">&quot;kb_&quot;</span>):
        <span class="hljs-keyword">try</span>:
            hex_str = real_name[<span class="hljs-number">3</span>:]
            <span class="hljs-keyword">return</span> binascii.unhexlify(hex_str).decode(<span class="hljs-string">&#x27;utf-8&#x27;</span>)
        <span class="hljs-keyword">except</span>:
            <span class="hljs-keyword">return</span> real_name
    <span class="hljs-keyword">return</span> real_name
<button class="copy-code-btn"></button></code></pre>
<p>Para além da nomeação, cada pedaço passa por duas etapas antes da inserção: gerar uma incorporação e anexar metadados.</p>
<ul>
<li><strong>O que é armazenado:</strong></li>
</ul>
<p>Cada pedaço é convertido num vetor denso de 384 dimensões. Ao mesmo tempo, o esquema Milvus armazena campos extra, como o nome do ficheiro, o número da página e o ID do bloco.</p>
<ul>
<li><strong>Porque é que isto é importante:</strong></li>
</ul>
<p>Isto torna possível rastrear uma resposta até a página exata de onde ela veio. Também prepara o sistema para futuros casos de utilização multimodal de perguntas e respostas.</p>
<ul>
<li><strong>Otimização de desempenho:</strong></li>
</ul>
<p>Em vector_store.py, o método insert_documents usa a incorporação em lote. Isso reduz o número de solicitações de rede e torna o processo mais eficiente.</p>
<pre><code translate="no"><span class="hljs-comment"># vector_store.py</span>
<span class="hljs-keyword">def</span> <span class="hljs-title function_">insert_documents</span>(<span class="hljs-params">self, documents</span>):
    <span class="hljs-string">&quot;&quot;&quot;Batch vectorization and insertion into Milvus&quot;&quot;&quot;</span>
    <span class="hljs-keyword">if</span> <span class="hljs-keyword">not</span> documents: <span class="hljs-keyword">return</span>
    <span class="hljs-comment"># 1. Extract plain text list and request the embedding model in batch</span>
    texts = [doc[<span class="hljs-string">&#x27;content&#x27;</span>] <span class="hljs-keyword">for</span> doc <span class="hljs-keyword">in</span> documents]
    embeddings = <span class="hljs-variable language_">self</span>.get_embeddings(texts)
    <span class="hljs-comment"># 2. Data cleaning: filter out invalid data where embedding failed</span>
    valid_docs, valid_vectors = [], []
    <span class="hljs-keyword">for</span> i, emb <span class="hljs-keyword">in</span> <span class="hljs-built_in">enumerate</span>(embeddings):
        <span class="hljs-keyword">if</span> emb <span class="hljs-keyword">and</span> <span class="hljs-built_in">len</span>(emb) == <span class="hljs-number">384</span>: <span class="hljs-comment"># Ensure the vector dimension is correct</span>
            valid_docs.append(documents[i])
            valid_vectors.append(emb)
    <span class="hljs-comment"># 3. Assemble columnar data (Columnar Format)</span>
    <span class="hljs-comment"># Milvus insert API requires each field to be passed in list format</span>
    data = [
        [doc[<span class="hljs-string">&#x27;filename&#x27;</span>] <span class="hljs-keyword">for</span> doc <span class="hljs-keyword">in</span> valid_docs],  <span class="hljs-comment"># Scalar: file name</span>
        [doc[<span class="hljs-string">&#x27;page&#x27;</span>] <span class="hljs-keyword">for</span> doc <span class="hljs-keyword">in</span> valid_docs],      <span class="hljs-comment"># Scalar: page number (for traceability)</span>
        [doc[<span class="hljs-string">&#x27;chunk_id&#x27;</span>] <span class="hljs-keyword">for</span> doc <span class="hljs-keyword">in</span> valid_docs],  <span class="hljs-comment"># Scalar: chunk ID</span>
        [doc[<span class="hljs-string">&#x27;content&#x27;</span>] <span class="hljs-keyword">for</span> doc <span class="hljs-keyword">in</span> valid_docs],   <span class="hljs-comment"># Scalar: original content (for keyword search)</span>
        valid_vectors                             <span class="hljs-comment"># Vector: semantic vector</span>
    ]
    <span class="hljs-comment"># 4. Execute insertion and persistence</span>
    <span class="hljs-variable language_">self</span>.collection.insert(data)
    <span class="hljs-variable language_">self</span>.collection.flush()
<button class="copy-code-btn"></button></code></pre>
<h3 id="Step-4-Retrieve-with-Hybrid-Search-and-RRF-Fusion" class="common-anchor-header">Etapa 4: Recuperar com pesquisa híbrida e fusão RRF</h3><p>Um único método de pesquisa raramente é suficiente. A pesquisa vetorial encontra conteúdos semanticamente semelhantes, mas pode não encontrar termos exactos; a pesquisa por palavra-chave encontra termos específicos, mas não encontra paráfrases. Executar ambos em paralelo e fundir os resultados produz melhores resultados do que qualquer um deles isoladamente.</p>
<p>Quando o idioma da consulta difere do idioma do documento, o sistema começa por traduzir a consulta utilizando um LLM para que ambos os caminhos de pesquisa possam funcionar no idioma do documento. Em seguida, as duas pesquisas são executadas em paralelo:</p>
<ul>
<li><strong>Pesquisa vetorial (densa):</strong> Encontra conteúdo com um significado semelhante, mesmo em várias línguas, mas pode revelar passagens relacionadas que não respondem diretamente à pergunta.</li>
<li><strong>Pesquisa de palavras-chave (esparsa):</strong> Encontra correspondências exactas para termos técnicos, números ou variáveis de fórmulas - o tipo de tokens que as incorporações vectoriais muitas vezes suavizam.</li>
</ul>
<p>O sistema funde ambas as listas de resultados utilizando RRF (Reciprocal Rank Fusion). Cada candidato recebe uma pontuação baseada na sua classificação em cada lista, pelo que um fragmento que aparece perto do topo de <em>ambas as</em> listas tem a pontuação mais elevada. A pesquisa vetorial contribui para a cobertura semântica; a pesquisa por palavra-chave contribui para a precisão do termo.</p>
<p>
  <span class="img-wrapper">
    <img translate="no" src="https://assets.zilliz.com/blog_From_PD_Fsto_Answers_Buildinga_RAG_Knowledge_Bas_1_d241e95fc2.png" alt="" class="doc-image" id="" />
    <span></span>
  </span>
</p>
<pre><code translate="no"><span class="hljs-comment"># Summary of retrieval logic in vector_store.py</span>
<span class="hljs-keyword">def</span> <span class="hljs-title function_">search</span>(<span class="hljs-params">self, query: <span class="hljs-built_in">str</span>, top_k: <span class="hljs-built_in">int</span> = <span class="hljs-number">10</span>, **kwargs</span>):
    <span class="hljs-string">&#x27;&#x27;&#x27;Vector search (Dense + Keyword) + RRF fusion&#x27;&#x27;&#x27;</span>
    <span class="hljs-comment"># 1. Vector search (Dense)</span>
    dense_results = []
    query_vector = <span class="hljs-variable language_">self</span>.embedding_client.get_embedding(query)  <span class="hljs-comment"># ... (Milvus search code) ...</span>
    <span class="hljs-comment"># 2. Keyword search</span>
    <span class="hljs-comment"># Perform jieba tokenization and build like &quot;%keyword%&quot; queries</span>
    keyword_results = <span class="hljs-variable language_">self</span>._keyword_search(query, top_k=top_k * <span class="hljs-number">5</span>, expr=expr)
    <span class="hljs-comment"># 3. RRF fusion</span>
    rank_dict = {}
    <span class="hljs-keyword">def</span> <span class="hljs-title function_">apply_rrf</span>(<span class="hljs-params">results_list, k=<span class="hljs-number">60</span>, weight=<span class="hljs-number">1.0</span></span>):
        <span class="hljs-keyword">for</span> rank, item <span class="hljs-keyword">in</span> <span class="hljs-built_in">enumerate</span>(results_list):
            doc_id = item.get(<span class="hljs-string">&#x27;id&#x27;</span>) <span class="hljs-keyword">or</span> item.get(<span class="hljs-string">&#x27;chunk_id&#x27;</span>)
            <span class="hljs-keyword">if</span> doc_id <span class="hljs-keyword">not</span> <span class="hljs-keyword">in</span> rank_dict:
                rank_dict[doc_id] = {<span class="hljs-string">&quot;data&quot;</span>: item, <span class="hljs-string">&quot;score&quot;</span>: <span class="hljs-number">0.0</span>}
            <span class="hljs-comment"># Core RRF formula</span>
            rank_dict[doc_id][<span class="hljs-string">&quot;score&quot;</span>] += weight * (<span class="hljs-number">1.0</span> / (k + rank))
    apply_rrf(dense_results, weight=<span class="hljs-number">4.0</span>)
    apply_rrf(keyword_results, weight=<span class="hljs-number">1.0</span>)
    <span class="hljs-comment"># 4. Sort and return results</span>
    sorted_docs = <span class="hljs-built_in">sorted</span>(rank_dict.values(), key=<span class="hljs-keyword">lambda</span> x: x[<span class="hljs-string">&#x27;score&#x27;</span>], reverse=<span class="hljs-literal">True</span>)
    <span class="hljs-keyword">return</span> [item[<span class="hljs-string">&#x27;data&#x27;</span>] <span class="hljs-keyword">for</span> item <span class="hljs-keyword">in</span> sorted_docs[:top_k * <span class="hljs-number">2</span>]]
<button class="copy-code-btn"></button></code></pre>
<h3 id="Step-5-Rerank-Results-Before-Answer-Generation" class="common-anchor-header">Etapa 5: Classificar novamente os resultados antes da geração de respostas</h3><p>Os pedaços retornados pela etapa de pesquisa não são igualmente relevantes. Por isso, antes de gerar a resposta final, uma etapa de reavaliação classifica-os novamente.</p>
<p>No reranker_v2.py, um método de pontuação combinado avalia cada fragmento, que é pontuado em cinco aspectos:</p>
<ul>
<li><strong>Correspondência difusa</strong></li>
</ul>
<p>Utilizando o fuzzywuzzy, verificamos a semelhança entre o texto do bloco e a consulta. Isto mede a sobreposição direta do texto.</p>
<ul>
<li><strong>Cobertura de palavras-chave</strong></li>
</ul>
<p>Verificamos quantas palavras importantes da consulta aparecem no fragmento. Mais correspondências de palavras-chave significam uma pontuação mais elevada.</p>
<ul>
<li><strong>Semelhança semântica</strong></li>
</ul>
<p>Reutilizamos a pontuação de semelhança do vetor apresentada pelo Milvus. Isto reflecte a proximidade dos significados.</p>
<ul>
<li><strong>Comprimento e classificação original</strong></li>
</ul>
<p>Os blocos muito curtos são penalizados porque muitas vezes não têm contexto. Os fragmentos com uma classificação mais elevada nos resultados originais do Milvus recebem um pequeno bónus.</p>
<ul>
<li><strong>Deteção de entidades nomeadas</strong></li>
</ul>
<p>O sistema detecta termos em maiúsculas como "Milvus" ou "RAG" como prováveis nomes próprios e identifica termos técnicos com várias palavras como possíveis frases-chave.</p>
<p>Cada fator tem um peso na pontuação final (mostrado na figura abaixo).</p>
<p>
  <span class="img-wrapper">
    <img translate="no" src="https://assets.zilliz.com/blog_From_PD_Fsto_Answers_Buildinga_RAG_Knowledge_Bas_2_2bce5d382a.png" alt="" class="doc-image" id="" />
    <span></span>
  </span>
</p>
<p>Não requer dados de treino e a contribuição de cada fator é visível. Se um bloco tiver uma classificação inesperadamente alta ou baixa, as pontuações explicam porquê. Um reranker totalmente black-box não oferece isso.</p>
<pre><code translate="no"><span class="hljs-comment"># reranker_v2.py</span>
<span class="hljs-keyword">def</span> <span class="hljs-title function_">_calculate_composite_score</span>(<span class="hljs-params">self, query: <span class="hljs-built_in">str</span>, chunk: <span class="hljs-type">Dict</span>[<span class="hljs-built_in">str</span>, <span class="hljs-type">Any</span>]</span>) -&gt; <span class="hljs-built_in">float</span>:
    content = chunk.get(<span class="hljs-string">&#x27;content&#x27;</span>, <span class="hljs-string">&#x27;&#x27;</span>)
    <span class="hljs-comment"># 1. Surface text similarity (FuzzyWuzzy)</span>
    fuzzy_score = fuzz.partial_ratio(query, content)
    <span class="hljs-comment"># 2. Keyword coverage</span>
    query_keywords = <span class="hljs-variable language_">self</span>._extract_keywords(query)
    content_keywords = <span class="hljs-variable language_">self</span>._extract_keywords(content)
    keyword_coverage = (<span class="hljs-built_in">len</span>(query_keywords &amp; content_keywords) / <span class="hljs-built_in">len</span>(query_keywords)) * <span class="hljs-number">100</span> <span class="hljs-keyword">if</span> query_keywords <span class="hljs-keyword">else</span> <span class="hljs-number">0</span>
    <span class="hljs-comment"># 3. Vector semantic score (normalized)</span>
    milvus_distance = chunk.get(<span class="hljs-string">&#x27;semantic_score&#x27;</span>, <span class="hljs-number">0</span>)
    milvus_similarity = <span class="hljs-number">100</span> / (<span class="hljs-number">1</span> + milvus_distance * <span class="hljs-number">0.1</span>)
    <span class="hljs-comment"># 4. Length penalty (prefer paragraphs between 200–600 characters)</span>
    content_len = <span class="hljs-built_in">len</span>(content)
    <span class="hljs-keyword">if</span> <span class="hljs-number">200</span> &lt;= content_len &lt;= <span class="hljs-number">600</span>:
        length_score = <span class="hljs-number">100</span>
    <span class="hljs-keyword">else</span>:
        <span class="hljs-comment"># ... (penalty logic)</span>
        length_score = <span class="hljs-number">100</span> - <span class="hljs-built_in">min</span>(<span class="hljs-number">50</span>, <span class="hljs-built_in">abs</span>(content_len - <span class="hljs-number">400</span>) / <span class="hljs-number">20</span>)
    <span class="hljs-comment"># Weighted sum</span>
    base_score = (
        fuzzy_score * <span class="hljs-number">0.25</span> +
        keyword_coverage * <span class="hljs-number">0.25</span> +
        milvus_similarity * <span class="hljs-number">0.35</span> +
        length_score * <span class="hljs-number">0.15</span>
    )
    <span class="hljs-comment"># Position weight</span>
    position_bonus = <span class="hljs-number">0</span>
    <span class="hljs-keyword">if</span> <span class="hljs-string">&#x27;milvus_rank&#x27;</span> <span class="hljs-keyword">in</span> chunk:
        rank = chunk[<span class="hljs-string">&#x27;milvus_rank&#x27;</span>]
        position_bonus = <span class="hljs-built_in">max</span>(<span class="hljs-number">0</span>, <span class="hljs-number">20</span> - rank)
    <span class="hljs-comment"># Extra bonus for proper noun detection</span>
    proper_noun_bonus = <span class="hljs-number">30</span> <span class="hljs-keyword">if</span> <span class="hljs-variable language_">self</span>._check_proper_nouns(query, content) <span class="hljs-keyword">else</span> <span class="hljs-number">0</span>
    <span class="hljs-keyword">return</span> base_score + proper_noun_bonus
<button class="copy-code-btn"></button></code></pre>
<h3 id="Step-6-Add-Multimodal-QA-for-Charts-and-Diagrams" class="common-anchor-header">Etapa 6: Adicionar perguntas e respostas multimodais para gráficos e diagramas</h3><p>Os documentos de investigação contêm frequentemente gráficos e diagramas importantes que contêm informações que o texto não contém. Um pipeline RAG só de texto perderia totalmente esses sinais.  Para lidar com isto, adicionámos uma funcionalidade simples de P&amp;R baseada em imagens com três partes:</p>
<p><strong>1. Adicionar mais contexto à pergunta</strong></p>
<p>Ao enviar uma imagem para o modelo, o sistema também obtém o texto de OCR da mesma página.<br>
O pedido inclui: a imagem, o texto da página e a pergunta do utilizador.<br>
Isto ajuda o modelo a compreender o contexto completo e reduz os erros durante a leitura da imagem.</p>
<pre><code translate="no"><span class="hljs-comment"># backend.py - Core logic for multimodal Q&amp;A</span>
<span class="hljs-comment"># 1. Retrieve OCR text from the current page as background context</span>
<span class="hljs-comment"># The system pulls the full page text where the image appears from Milvus,</span>
<span class="hljs-comment"># based on the document name and page number.</span>
<span class="hljs-comment"># page_num is parsed from the image file name sent by the frontend (e.g., &quot;p3_figure.jpg&quot; -&gt; Page 3)</span>
page_text_context = milvus_store.get_page_content(doc_name, page_num)[:<span class="hljs-number">800</span>]
<span class="hljs-comment"># 2. Dynamically build a context-enhanced prompt</span>
<span class="hljs-comment"># Key idea: explicitly align visual information with textual background</span>
<span class="hljs-comment"># to prevent hallucinations caused by answering from the image alone</span>
final_prompt = <span class="hljs-string">f&quot;&quot;&quot;
[Task] Answer the question using both the image and the background information.
[Image Metadata] Source: <span class="hljs-subst">{doc_name}</span> (P<span class="hljs-subst">{page_num}</span>)
[Background Text] <span class="hljs-subst">{page_text_context}</span> ... (long text omitted here)
[User Question] <span class="hljs-subst">{user_question}</span>
&quot;&quot;&quot;</span>
<span class="hljs-comment"># 3. Send multimodal request (Vision API)</span>
<span class="hljs-comment"># The underlying layer converts the image to Base64 and sends it</span>
<span class="hljs-comment"># together with final_prompt to the ERNIE-VL model</span>
answer = ernie_client.chat_with_image(query=final_prompt, image_path=img_path)
<button class="copy-code-btn"></button></code></pre>
<p><strong>2. Suporte da API de visão</strong></p>
<p>O cliente (ernie_client.py) suporta o formato de visão OpenAI. As imagens são convertidas para Base64 e enviadas no formato image_url, o que permite ao modelo processar a imagem e o texto em conjunto.</p>
<pre><code translate="no"><span class="hljs-comment"># ernie_client.py</span>
<span class="hljs-keyword">def</span> <span class="hljs-title function_">chat_with_image</span>(<span class="hljs-params">self, query: <span class="hljs-built_in">str</span>, image_path: <span class="hljs-built_in">str</span></span>):
   base64_image = <span class="hljs-variable language_">self</span>._encode_image(image_path)
   <span class="hljs-comment"># Build Vision message format</span>
   messages = [
      {
            <span class="hljs-string">&quot;role&quot;</span>: <span class="hljs-string">&quot;user&quot;</span>,
            <span class="hljs-string">&quot;content&quot;</span>: [
               {<span class="hljs-string">&quot;type&quot;</span>: <span class="hljs-string">&quot;text&quot;</span>, <span class="hljs-string">&quot;text&quot;</span>: query},
               {
                  <span class="hljs-string">&quot;type&quot;</span>: <span class="hljs-string">&quot;image_url&quot;</span>,
                  <span class="hljs-string">&quot;image_url&quot;</span>: {
                        <span class="hljs-string">&quot;url&quot;</span>: <span class="hljs-string">f&quot;data:image/jpeg;base64,<span class="hljs-subst">{base64_image}</span>&quot;</span>
                  }
               }
            ]
      }
   ]
   <span class="hljs-keyword">return</span> <span class="hljs-variable language_">self</span>.chat(messages)
<button class="copy-code-btn"></button></code></pre>
<p><strong>3. Plano de recurso</strong></p>
<p>Se a API de imagem falhar (por exemplo, devido a problemas de rede ou a limites do modelo), o sistema volta ao RAG normal baseado em texto.<br>
Utiliza o texto OCR para responder à pergunta, pelo que o sistema continua a funcionar sem interrupções.</p>
<pre><code translate="no"><span class="hljs-comment"># Fallback logic in backend.py</span>
<span class="hljs-keyword">try</span>:
   answer = ernie.chat_with_image(final_prompt, img_path)
   <span class="hljs-comment"># ...</span>
<span class="hljs-keyword">except</span> Exception <span class="hljs-keyword">as</span> e:
   <span class="hljs-built_in">print</span>(<span class="hljs-string">f&quot;⚠️ Model does not support images. Switching to text mode.&quot;</span>)
   <span class="hljs-comment"># Fallback: use the extracted text as context to continue answering</span>
   answer, metric = ask_question_logic(final_prompt, collection_name)
<button class="copy-code-btn"></button></code></pre>
<h2 id="Key-UI-Features-and-Implementation-for-Pipeline" class="common-anchor-header">Principais recursos da interface do usuário e implementação para pipeline<button data-href="#Key-UI-Features-and-Implementation-for-Pipeline" class="anchor-icon" translate="no">
      <svg translate="no"
        aria-hidden="true"
        focusable="false"
        height="20"
        version="1.1"
        viewBox="0 0 16 16"
        width="16"
      >
        <path
          fill="#0092E4"
          fill-rule="evenodd"
          d="M4 9h1v1H4c-1.5 0-3-1.69-3-3.5S2.55 3 4 3h4c1.45 0 3 1.69 3 3.5 0 1.41-.91 2.72-2 3.25V8.59c.58-.45 1-1.27 1-2.09C10 5.22 8.98 4 8 4H4c-.98 0-2 1.22-2 2.5S3 9 4 9zm9-3h-1v1h1c1 0 2 1.22 2 2.5S13.98 12 13 12H9c-.98 0-2-1.22-2-2.5 0-.83.42-1.64 1-2.09V6.25c-1.09.53-2 1.84-2 3.25C6 11.31 7.55 13 9 13h4c1.45 0 3-1.69 3-3.5S14.5 6 13 6z"
        ></path>
      </svg>
    </button></h2><h3 id="How-to-Handle-API-Rate-Limiting-and-Protection" class="common-anchor-header">Como lidar com a limitação e proteção da taxa de API</h3><p>Ao chamar o LLM ou incorporar APIs, o sistema pode às vezes receber um erro <strong>429 Too Many Requests</strong>. Isso geralmente acontece quando muitas solicitações são enviadas em um curto espaço de tempo.</p>
<p>Para lidar com isto, o projeto adiciona um mecanismo de abrandamento adaptativo em ernie_client.py. Se ocorrer um erro de limite de taxa, o sistema reduz automaticamente a velocidade do pedido e tenta novamente em vez de parar.</p>
<pre><code translate="no"><span class="hljs-comment"># Logic for handling rate limiting</span>
<span class="hljs-keyword">if</span> is_rate_limit:
    <span class="hljs-variable language_">self</span>._adaptive_slow_down()  <span class="hljs-comment"># Permanently increase the request interval</span>
    wait_time = (<span class="hljs-number">2</span> ** attempt) + random.uniform(<span class="hljs-number">1.0</span>, <span class="hljs-number">3.0</span>)  <span class="hljs-comment"># Exponential backoff</span>
    time.sleep(wait_time)
<span class="hljs-keyword">def</span> <span class="hljs-title function_">_adaptive_slow_down</span>(<span class="hljs-params">self</span>):
    <span class="hljs-string">&quot;&quot;&quot;Trigger adaptive downgrade: when rate limiting occurs, permanently increase the global request interval&quot;&quot;&quot;</span>
    <span class="hljs-variable language_">self</span>.current_delay = <span class="hljs-built_in">min</span>(<span class="hljs-variable language_">self</span>.current_delay * <span class="hljs-number">2.0</span>, <span class="hljs-number">15.0</span>)
    logger.warning(<span class="hljs-string">f&quot;📉 Rate limit triggered (429), system automatically slowing down: new interval <span class="hljs-subst">{self.current_delay:<span class="hljs-number">.2</span>f}</span>s&quot;</span>)
<button class="copy-code-btn"></button></code></pre>
<p>Isto ajuda a manter o sistema estável, especialmente ao processar e incorporar um grande número de documentos.</p>
<h3 id="Custom-Styling" class="common-anchor-header">Estilo personalizado</h3><p>O frontend usa o Gradio (main.py). Adicionámos CSS personalizado (modern_css) para tornar a interface mais limpa e fácil de usar.</p>
<ul>
<li><strong>Caixa de entrada</strong></li>
</ul>
<p>Mudámos do estilo cinzento predefinido para um design branco e arredondado. Parece mais simples e mais moderno.</p>
<ul>
<li><strong>Botão Enviar</strong></li>
</ul>
<p>Adicionada uma cor gradiente e um efeito de foco para que se destaque mais.</p>
<pre><code translate="no"><span class="hljs-comment">/* main.py - modern_css snippet */</span>
<span class="hljs-comment">/* Force the input box to use a white background with rounded corners, simulating a modern chat app */</span>
.custom-textbox textarea {
    background-color: 
<span class="hljs-meta">#ffffff</span>
 !important;
    border: <span class="hljs-number">1</span>px solid 
<span class="hljs-meta">#e5e7eb</span>
 !important;
    border-radius: <span class="hljs-number">12</span>px !important;
    box-shadow: <span class="hljs-number">0</span> <span class="hljs-number">4</span>px <span class="hljs-number">12</span><span class="hljs-function">px <span class="hljs-title">rgba</span>(<span class="hljs-params"><span class="hljs-number">0</span>,<span class="hljs-number">0</span>,<span class="hljs-number">0</span>,<span class="hljs-number">0.05</span></span>) !important</span>;
    padding: <span class="hljs-number">14</span>px !important;
}
<span class="hljs-comment">/* Gradient send button */</span>
.send-btn {
    background: linear-gradient(<span class="hljs-number">135</span>deg, 
<span class="hljs-meta">#6366f1</span>
 <span class="hljs-number">0</span>%, 
<span class="hljs-meta">#4f46e5</span>
 <span class="hljs-number">100</span>%) !important;
    color: white !important;
    box-shadow: <span class="hljs-number">0</span> <span class="hljs-number">4</span>px <span class="hljs-number">10</span><span class="hljs-function">px <span class="hljs-title">rgba</span>(<span class="hljs-params"><span class="hljs-number">99</span>, <span class="hljs-number">102</span>, <span class="hljs-number">241</span>, <span class="hljs-number">0.3</span></span>) !important</span>;
}
<button class="copy-code-btn"></button></code></pre>
<h3 id="LaTeX-Formula-Rendering" class="common-anchor-header">Renderização de fórmulas LaTeX</h3><p>Muitos documentos de investigação contêm fórmulas matemáticas, pelo que é importante uma apresentação correta. Adicionámos suporte LaTeX completo para fórmulas em linha e em bloco.</p>
<ul>
<li><strong>Onde se aplica</strong>A configuração funciona tanto na janela de chat (Chatbot) como na área de resumo (Markdown).</li>
<li><strong>Resultado prático</strong>Quer as fórmulas apareçam na resposta do modelo ou nos resumos dos documentos, são apresentadas corretamente na página.</li>
</ul>
<pre><code translate="no"><span class="hljs-comment"># Configure LaTeX rules in main.py</span>
latex_config = [
    {<span class="hljs-string">&quot;left&quot;</span>: <span class="hljs-string">&quot;$$&quot;</span>, <span class="hljs-string">&quot;right&quot;</span>: <span class="hljs-string">&quot;$$&quot;</span>, <span class="hljs-string">&quot;display&quot;</span>: <span class="hljs-literal">True</span>},    <span class="hljs-comment"># Recognize block equations</span>
    {<span class="hljs-string">&quot;left&quot;</span>: <span class="hljs-string">&quot;$&quot;</span>, <span class="hljs-string">&quot;right&quot;</span>: <span class="hljs-string">&quot;$&quot;</span>, <span class="hljs-string">&quot;display&quot;</span>: <span class="hljs-literal">False</span>},     <span class="hljs-comment"># Recognize inline equations</span>
    {<span class="hljs-string">&quot;left&quot;</span>: <span class="hljs-string">&quot;\(&quot;</span>, <span class="hljs-string">&quot;right&quot;</span>: <span class="hljs-string">&quot;\)&quot;</span>, <span class="hljs-string">&quot;display&quot;</span>: <span class="hljs-literal">False</span>}, <span class="hljs-comment"># Standard LaTeX inline</span>
    {<span class="hljs-string">&quot;left&quot;</span>: <span class="hljs-string">&quot;\[&quot;</span>, <span class="hljs-string">&quot;right&quot;</span>: <span class="hljs-string">&quot;\]&quot;</span>, <span class="hljs-string">&quot;display&quot;</span>: <span class="hljs-literal">True</span>}   <span class="hljs-comment"># Standard LaTeX block</span>
]
<span class="hljs-comment"># Then inject this configuration when initializing components:</span>
<span class="hljs-comment"># Enable LaTeX in Chatbot</span>
chatbot = gr.Chatbot(
    label=<span class="hljs-string">&quot;Conversation&quot;</span>,
    <span class="hljs-comment"># ... other parameters ...</span>
    latex_delimiters=latex_config  <span class="hljs-comment"># Key configuration: enable formula rendering</span>
)
<span class="hljs-comment"># Enable LaTeX in the document summary area</span>
doc_summary = gr.Markdown(
    value=<span class="hljs-string">&quot;*No summary available*&quot;</span>,
    latex_delimiters=latex_config
)
<button class="copy-code-btn"></button></code></pre>
<h3 id="Explainability-Relevance-Scores-and-Confidence" class="common-anchor-header">Explicabilidade: Pontuações de relevância e confiança</h3><p>Para evitar uma experiência de "caixa negra", o sistema apresenta dois indicadores simples:</p>
<ul>
<li><p><strong>Relevância</strong></p></li>
<li><p>Apresentado por baixo de cada resposta na secção "Referências".</p></li>
<li><p>Exibe a pontuação do reranker para cada trecho citado.</p></li>
<li><p>Ajuda os utilizadores a perceber porque é que uma página ou passagem específica foi utilizada.</p></li>
</ul>
<pre><code translate="no"><span class="hljs-comment"># backend.py - Build reference source list</span>
sources = <span class="hljs-string">&quot;\n\n📚 **References:**\n&quot;</span>
<span class="hljs-keyword">for</span> c <span class="hljs-keyword">in</span> final:
    <span class="hljs-comment"># ... (deduplication logic) ...</span>
    <span class="hljs-comment"># Directly pass through the per-chunk score calculated by the Reranker</span>
    sources += <span class="hljs-string">f&quot;- <span class="hljs-subst">{key}</span> [Relevance:<span class="hljs-subst">{c.get(<span class="hljs-string">&#x27;composite_score&#x27;</span>,<span class="hljs-number">0</span>):<span class="hljs-number">.0</span>f}</span>%]\n&quot;</span>
<button class="copy-code-btn"></button></code></pre>
<ul>
<li><p><strong>Confiança</strong></p></li>
<li><p>Apresentada no painel "Detalhes da análise".</p></li>
<li><p>Baseada na pontuação do bloco superior (escalonada para 100%).</p></li>
<li><p>Mostra o grau de confiança que o sistema tem na resposta.</p></li>
<li><p>Se for inferior a 60%, a resposta pode ser menos fiável.</p></li>
</ul>
<pre><code translate="no"><span class="hljs-comment"># backend.py - Calculate overall confidence</span>
<span class="hljs-comment"># 1. Get the top-ranked chunk after reranking</span>
final = processed[:<span class="hljs-number">22</span>]
top_score = final[<span class="hljs-number">0</span>].get(<span class="hljs-string">&#x27;composite_score&#x27;</span>, <span class="hljs-number">0</span>) <span class="hljs-keyword">if</span> final <span class="hljs-keyword">else</span> <span class="hljs-number">0</span>
<span class="hljs-comment"># 2. Normalize the score (capped at 100%) as the overall &quot;confidence&quot; for this Q&amp;A</span>
metric = <span class="hljs-string">f&quot;<span class="hljs-subst">{<span class="hljs-built_in">min</span>(<span class="hljs-number">100</span>, top_score):<span class="hljs-number">.1</span>f}</span>%&quot;</span>
<button class="copy-code-btn"></button></code></pre>
<p>A interface do usuário é mostrada abaixo. Na interface, cada resposta mostra o número da página da fonte e a sua pontuação de relevância.</p>
<p>
  <span class="img-wrapper">
    <img translate="no" src="https://assets.zilliz.com/1_ec01986414.png" alt="" class="doc-image" id="" />
    <span></span>
  </span>


  <span class="img-wrapper">
    <img translate="no" src="https://assets.zilliz.com/2_98d526ce64.png" alt="" class="doc-image" id="" />
    <span></span>
  </span>


  <span class="img-wrapper">
    <img translate="no" src="https://assets.zilliz.com/3_99e9d19162.png" alt="" class="doc-image" id="" />
    <span></span>
  </span>


  <span class="img-wrapper">
    <img translate="no" src="https://assets.zilliz.com/4_a82aaa6ddd.png" alt="" class="doc-image" id="" />
    <span></span>
  </span>
</p>
<h2 id="Conclusion" class="common-anchor-header">Conclusão<button data-href="#Conclusion" class="anchor-icon" translate="no">
      <svg translate="no"
        aria-hidden="true"
        focusable="false"
        height="20"
        version="1.1"
        viewBox="0 0 16 16"
        width="16"
      >
        <path
          fill="#0092E4"
          fill-rule="evenodd"
          d="M4 9h1v1H4c-1.5 0-3-1.69-3-3.5S2.55 3 4 3h4c1.45 0 3 1.69 3 3.5 0 1.41-.91 2.72-2 3.25V8.59c.58-.45 1-1.27 1-2.09C10 5.22 8.98 4 8 4H4c-.98 0-2 1.22-2 2.5S3 9 4 9zm9-3h-1v1h1c1 0 2 1.22 2 2.5S13.98 12 13 12H9c-.98 0-2-1.22-2-2.5 0-.83.42-1.64 1-2.09V6.25c-1.09.53-2 1.84-2 3.25C6 11.31 7.55 13 9 13h4c1.45 0 3-1.69 3-3.5S14.5 6 13 6z"
        ></path>
      </svg>
    </button></h2><p>A precisão do RAG depende da engenharia entre um LLM e uma base de dados vetorial. Este artigo percorreu uma construção do <a href="https://github.com/LiaoYFBH/Paddle-ERNIE-RAG/blob/main/README_EN.md">Paddle-ERNIE-RAG</a> com <a href="https://milvus.io"></a><a href="https://milvus.io">Milvus</a> que cobre cada etapa dessa engenharia:</p>
<ul>
<li><strong>Análise de documentos.</strong> O PP-StructureV3 (via <a href="https://github.com/PaddlePaddle/PaddleOCR"></a><a href="https://github.com/PaddlePaddle/PaddleOCR">PaddleOCR</a>) converte PDFs em Markdown limpo com OCR sensível ao layout, preservando cabeçalhos, tabelas e imagens que os extratores básicos perdem.</li>
<li><strong>Divisão em pedaços.</strong> As divisões de janela deslizante com sobreposição mantêm o contexto intacto nos limites dos pedaços, evitando os fragmentos quebrados que prejudicam a recuperação.</li>
<li><strong>Armazenamento de vectores em Milvus.</strong> Armazenar vectores de uma forma que permita uma recuperação rápida e precisa.</li>
<li><strong>Pesquisa híbrida.</strong> Executar a pesquisa de vectores e a pesquisa de palavras-chave em paralelo e, em seguida, fundir os resultados com a RRF (Reciprocal Rank Fusion), permite obter correspondências semânticas e resultados de termos exactos que qualquer um dos métodos não conseguiria obter.</li>
<li><strong>Reranking.</strong> Um reranker transparente e baseado em regras classifica cada fragmento de acordo com a correspondência difusa, a cobertura de palavras-chave, a semelhança semântica, o comprimento e a deteção de substantivos adequados - não são necessários dados de treino e todas as classificações são depuráveis.</li>
<li><strong>Perguntas e respostas multimodais.</strong> O emparelhamento de imagens com texto de página OCR no prompt fornece ao modelo de visão contexto suficiente para responder a perguntas sobre gráficos e diagramas, com um fallback somente de texto se a API de imagem falhar.</li>
</ul>
<p>Se estiver a construir um sistema RAG para P&amp;R de documentos e pretender uma maior precisão, gostaríamos de saber como o está a abordar.</p>
<p>Tem dúvidas sobre o <a href="https://milvus.io/">Milvus</a>, a pesquisa híbrida ou o design da base de conhecimento? Junte-se ao nosso <a href="https://milvusio.slack.com/join/shared_invite/zt-3nntzngkz-gYwhrdSE4~76k0VMyBfD1Q#/shared-invite/email">canal Slack</a> ou marque uma sessão de 20 minutos <a href="https://milvus.io/blog/join-milvus-office-hours-to-get-support-from-vectordb-experts.md">do Milvus Office Hours</a> para discutir o seu caso de utilização.</p>
